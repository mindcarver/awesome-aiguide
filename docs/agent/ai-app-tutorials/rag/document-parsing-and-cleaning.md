# 文档解析与清洗

**TL;DR**: 文档解析是 RAG 管线的起点，解析质量直接决定系统上限。PDF 仍是最大挑战（多栏、表格、公式），2024-2026 年工具链有显著进步：Docling 和 Marker 大幅降低了高质量 PDF 解析的门槛。核心原则：宁可少去不要误杀，保留结构信息，清洗操作可追溯。

## 概述

前文已经建立了 [RAG 系统的全景认知](rag-principles-and-architecture.md)，知道了"先搜后答"的完整流程。现在进入第一个工程环节：文档解析与清洗。

这是整个管线的起点。如果这一步做不好，后面的 [切分](chunking-strategies.md) 会乱、向量化会差、检索会偏、答案自然好不了。

## 一、PDF 解析

PDF 是企业中最常见的文档格式，也是解析难度最大的。

**PDF 的本质。** PDF 的设计目标是"在任何设备上看起来都一样"。它记录的是排版信息——"在坐标 (x, y) 处用 12pt Times New Roman 渲染文字"，而不是"这里有一段文本"。你要从视觉信息中反推内容结构，本质上是逆向工程。

**三种解析方式：**

| 方式 | 适用对象 | 工具 | 速度 | 准确率 |
|------|---------|------|------|--------|
| 文本提取 | 文字型 PDF | PyPDF2, pdfplumber | 快 | 高 |
| OCR | 扫描件、图片 PDF | Tesseract, PaddleOCR | 中 | 中 |
| 视觉模型 | 复杂排版、多栏嵌套表格 | GPT-4V, Claude, Docling | 慢 | 最高 |

**PDF 解析的具体挑战：**

- **多栏排版。** 学术论文的双栏排版，文本提取时左右栏会混在一起。需要先检测栏边界，按栏分别提取。
- **表格。** PDF 表格的行列关系在文本提取后会丢失。表格数据往往包含关键信息（规格、价格、流程），需要专门处理。
- **页眉页脚。** 每页重复的标题、页码、版权声明会污染正文，检索时造成干扰。
- **图片中的文字。** 流程图标注、截图内容无法通过文本提取获得。
- **公式。** 数学公式用特殊字体渲染，文本提取出来是乱码。

### 2026 工具更新

**Docling（IBM，2024）** 是目前最值得关注的 PDF 解析工具：

```python
from docling.document_converter import DocumentConverter

converter = DocumentConverter()
result = converter.convert("report.pdf")

# 输出 Markdown 格式，保留表格和标题结构
markdown_output = result.document.export_to_markdown()

# 输出 JSON 格式，带结构信息
json_output = result.document.export_to_dict()
```

Docling 的优势：内置布局分析模型，能正确处理多栏排版、嵌套表格；支持 PDF/DOCX/PPTX/HTML/图片；输出 Markdown 或 JSON 格式，天然适合 RAG 管线。

**Marker** 专注于 PDF 转 Markdown，对学术论文（使用 Nougat 模型）和技术文档效果很好：

```python
from marker.converters.pdf import PdfConverter
from marker.models import create_model_dict

model_dict = create_model_dict()
converter = PdfConverter(artifact_dict=model_dict)
rendered = converter("paper.pdf")
# rendered.markdown 包含转换后的 Markdown
```

**工程建议。** 对文字型 PDF，用 Docling 或 pdfplumber。对扫描件，用 PaddleOCR（中文场景首选）。对复杂排版（学术论文、财务报表），用 Docling 或视觉模型。页眉页脚在清洗阶段统一处理。

## 二、Markdown 解析

Markdown 是对 RAG 最友好的格式。它本身就是纯文本，天然带结构标记（# 标题、- 列表、| 表格），不需要逆向工程。

**解析要点：**

- **标题层级。** #、##、### 天然提供文档结构，应提取为切分的边界依据。
- **代码块。** 三个反引号包围的代码块有完整逻辑含义，不应在中间切分。
- **表格。** Markdown 表格用 | 分隔，解析容易，但宽表或长表可能需要拆分。
- **YAML 元数据。** 文件开头的 --- 包围部分包含标题、作者、日期等信息，应提取为文档级元数据。

```python
import frontmatter
import mistune

# 提取 YAML 元数据 + 正文
post = frontmatter.load("doc.md")
metadata = post.metadata  # {"title": "...", "author": "...", "date": "..."}
content = post.content

# 解析结构
md = mistune.create_markdown()
tokens = md.parse(content)
```

## 三、Word 解析

Word 文档（.docx）在企业中常见，尤其是合同、报告、制度规范。

**Word 文件结构。** .docx 本质是 ZIP 压缩包，里面是 XML 文件。python-docx 库可以解析这些 XML，提取文本和样式。

**解析要点：**

- **段落和样式。** 每个段落有样式信息（标题 1、标题 2、正文），样式映射到标题层级。
- **表格。** Word 表格的行列结构是明确的，比 PDF 容易处理。可以转为 Markdown 表格格式。
- **页眉页脚。** 和 PDF 一样需要去除。

```python
from docx import Document

doc = Document("report.docx")

for para in doc.paragraphs:
    style = para.style.name  # "Heading 1", "Heading 2", "Normal"
    text = para.text

# 提取表格
for table in doc.tables:
    for row in table.rows:
        cells = [cell.text for cell in row.cells]
```

## 四、Excel 解析

Excel 不是自然语言文档，而是结构化数据表格，解析策略不同于其他格式。

**问题。** 每个单元格可能只有一个词或数字，直接按单元格提取会导致碎片化。RAG 需要的是有语义完整性的文本块。

**策略：**

- **按行文本化。** 每行转成自然语言句子："产品A | 100元 | 库存充足" → "产品 A 的价格是 100 元，当前库存充足"。
- **按表格摘要化。** 大型表格生成摘要："本表包含 50 个产品的价格和库存信息，其中产品 A 价格最高"。
- **Sheet 元数据。** Sheet 名称和列名作为结构信息提取。

```python
import pandas as pd

df = pd.read_excel("products.xlsx", sheet_name="价格表")

# 小表：逐行文本化
for _, row in df.iterrows():
    text = f"{row['产品名']}的价格是{row['价格']}元，库存状态为{row['库存状态']}"
```

**注意。** 对于需要精确查询的场景（"SKU12345 的价格是多少"），Excel 数据更适合走 Text-to-SQL 路径而非 RAG 文本检索。详见[高级专题](advanced-topics-and-engineering.md)。

## 五、HTML 解析

HTML 有明确的语义标签（`<h1>`、`<p>`、`<ul>`、`<table>`），结构提取比 PDF 容易得多。

**挑战：**

- **JS 渲染内容。** 现代网页通过 JavaScript 动态加载内容，需要用 Playwright/Selenium 获取渲染后的 HTML。
- **噪声内容。** 导航栏、侧边栏、广告、页脚对知识库无价值，需要去除。
- **重复内容。** 同一网站多个页面共享相同的页脚和版权声明，会污染检索。

```python
from bs4 import BeautifulSoup

# 解析静态 HTML
soup = BeautifulSoup(html_content, "lxml")

# 去除导航、页脚等噪声
for tag in soup.find_all(["nav", "footer", "header", "aside"]):
    tag.decompose()

# 提取正文
main_content = soup.find("main") or soup.find("article") or soup.body
text = main_content.get_text(separator="\n", strip=True)
```

## 六、文本清洗

解析出文本后，去除噪声，保留有价值的内容。

**需要去除的噪声：**

| 噪声类型 | 示例 | 处理方式 |
|---------|------|---------|
| 页眉页脚 | 每页重复的标题、页码 | 正则匹配重复模式 |
| 多余空白 | 连续空格、换行 | 合并为单个空格/换行 |
| 特殊字符 | 乱码、控制字符 | 字符白名单过滤 |
| 版权声明 | 免责条款 | 识别并去除 |
| 页码标记 | "第 X 页"、孤立的数字 | 正则匹配 |

**清洗原则：**

1. **宁可少去，不要误杀。** 看似噪声的内容可能包含关键信息。
2. **保留结构标记。** 标题、段落分隔符是后续切分的基础。
3. **可追溯。** 保留清洗前后的映射关系，方便回退调试。

## 七、结构信息提取

清洗后的文本是平铺的字符串，但原始文档有结构。提取结构信息对后续切分和检索至关重要。

**需要提取的结构：**

- **标题层级。** 几级标题，标题间的父子关系。
- **段落边界。** 哪些文本属于同一段落。
- **列表结构。** 列表项及其嵌套层级。
- **表格位置。** 表格在文档中的位置、标题和说明。

**元数据提取：**

- **文档级。** 标题、作者、创建/修改日期、文档类型、分类。
- **片段级。** 所属章节、页码、在原文中的位置。

```python
# 结构信息提取示意
structured_doc = {
    "metadata": {"title": "退货政策", "version": "2.0", "updated": "2025-03-01"},
    "sections": [
        {
            "heading": "退货条件",
            "level": 2,
            "content": "自签收之日起7天内...",
            "position": {"page": 1, "char_offset": 0}
        },
        {
            "heading": "退货流程",
            "level": 2,
            "content": "...",
            "position": {"page": 1, "char_offset": 156}
        }
    ]
}
```

## 八、工具选型对比

| 工具 | 支持格式 | 核心优势 | 适用场景 |
|------|---------|---------|---------|
| **Docling** | PDF/DOCX/PPTX/HTML/图片 | 布局分析、表格提取、输出 Markdown/JSON | 通用首选，尤其是复杂 PDF |
| **Marker** | PDF | 学术论文转 Markdown，Nougat 模型 | 学术论文、技术文档 |
| **Unstructured.io** | 30+ 格式 | 分区处理、多格式支持 | 大规模异构文档处理 |
| **PyPDF2/pdfplumber** | PDF | 轻量、文本提取快 | 简单文字型 PDF |
| **PaddleOCR** | 图片/扫描件 | 中文 OCR 首选 | 扫描件、图片中的文字 |
| **python-docx** | DOCX | 段落样式、表格结构 | Word 文档 |
| **BeautifulSoup** | HTML | 标签选择器、轻量 | 网页内容 |

**选型建议：** 优先用 Docling 处理大多数格式。扫描件加 PaddleOCR。网页用 BeautifulSoup + Playwright。学术 PDF 加 Marker。

## 九、完整处理流程

```text
原始文档
  ↓ 格式判断
  ├─ PDF → Docling（文字型/复杂排版）或 PaddleOCR（扫描件）
  ├─ DOCX → python-docx
  ├─ HTML → BeautifulSoup + Playwright
  ├─ Excel → pandas（文本化或摘要化）
  └─ Markdown → 直接读取 + frontmatter
  ↓ 文本清洗
  去除页眉页脚、多余空白、特殊字符
  ↓ 结构提取
  标题层级、段落边界、元数据
  ↓ 输出
  结构化文本 + 元数据 JSON → 送入 [Chunking 切分](chunking-strategies.md)
```

## 延伸阅读

- [Docling](https://github.com/DS4SD/docling) — IBM 开源文档处理，支持多种格式
- [Marker](https://github.com/VikParuchuri/marker) — PDF 转 Markdown
- [Unstructured.io](https://unstructured.io/) — 多格式文档处理平台
- [PaddleOCR](https://github.com/PaddlePaddle/PaddleOCR) — 中文 OCR
- [Chunking切分策略](chunking-strategies.md) — 解析后的下一步：文本切分
