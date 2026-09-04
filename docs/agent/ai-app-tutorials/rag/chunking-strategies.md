# Chunking 切分策略

## TL;DR

切分是 RAG 管线中对最终效果影响最大的环节之一。核心矛盾：粒度要细（检索精准）vs 上下文要保留（理解完整）。2024-2025 年的实践经验给出了明确的参数区间：

- **Chunk Size 甜点区：256-1024 tokens**。低于 256 丢失上下文，高于 1024 稀释检索精度。
- **段落级切分比固定长度切分效果好 10-20%**，因为保留了自然语义边界。
- **Overlap：15-25%**。太低没用，太高浪费存储和检索位。
- **实用默认方案**：LangChain 的 `RecursiveCharacterTextSplitter`，按 `\n\n` → `\n` → `。` → 空格 → 字符的优先级寻找分割点。
- **中文必须用 Token 计量**，不要用字符数。中文字符的 Token 编码长度不固定。
- **上下文增强切分**：在每个 Chunk 前拼接父级标题层级，弥补结构信息丢失。

前置知识：[文档解析与清洗](document-parsing-and-cleaning.md) 产出的干净文本是切分的输入。后续环节 [Embedding与向量数据库](embedding-and-vector-db.md) 将切分后的 Chunk 向量化。切分效果的评估方法见 [RAG评估与微调](rag-eval-and-finetuning.md)。

---

## 1 概述

前文已经把各种格式的文档解析成了干净的文本，还提取了结构信息和元数据。现在要把这些长文本切成适当大小的片段——这就是 Chunking（切分）。

切分听起来简单，实际上它是 RAG 系统中影响最终效果最显著的环节之一。切得太大，检索不精准，一个 Chunk 里塞了几千字，向量是对整段文本的平均表示，模糊掉具体细节。切得太小，上下文丢失，一个只有两句话的 Chunk 缺少背景信息，模型看不懂它说的是什么。切分的粒度和方式，直接决定了检索的精度和答案的质量。

下表对比主流切分策略的核心特征：

| 策略 | 语义完整性 | 实现复杂度 | 适用文档 | 推荐场景 |
|------|-----------|-----------|---------|---------|
| 固定长度切分 | 低 | 极低 | 任意文本 | 快速原型、无结构文本 |
| 按段落切分 | 中高 | 低 | 自然语言文档 | 通用默认 |
| 按结构切分 | 高 | 中 | 有标题层级的文档 | 技术文档、手册 |
| 语义切分 | 最高 | 高 | 任意文档 | 高精度需求、预算充足 |
| 递归字符切分 | 中 | 低 | 任意文本 | 工程默认方案 |
| 上下文增强切分 | 高 | 中 | 有结构信息的文档 | 生产环境推荐 |

---

## 2 为什么要切块

理解切分的必要性，先搞清楚为什么不能把整篇文档直接塞给模型。

**向量检索需要短文本。** 向量检索的原理是计算问题向量和文档片段向量之间的相似度。如果文档片段太长，向量是对整段文本的"平均表示"，会模糊掉具体细节。你问"退货的 SLA 是多少小时"，如果文档片段是一整页的内容，里面提到了退货流程、退货条件、退货 SLA、退款方式等各种信息，向量表示会偏向整段文本的主题（退货相关），而不是具体的 SLA 数字。检索可能找得到这个片段，但片段太长，模型需要从中提取答案，效果打折。

**上下文窗口有限。** 虽然模型的上下文窗口越来越大，但把整篇 50 页的文档塞进 Prompt 是不现实的。实际操作中，检索到的片段会拼接到 Prompt 中，如果每个片段太长，能放的片段数量就少了，覆盖面变窄。

**语义粒度要对齐。** 用户的问题通常指向一个具体的知识点——一个数字、一个流程、一个定义。理想的 Chunk 大小应该和"一个完整的知识点"大致对齐。这样检索到的 Chunk 就是答案所在的最小上下文，既不缺少必要背景，又不包含太多无关信息。

**存储和检索效率。** 短文本的向量计算更快、存储更省、检索更高效。虽然这不是主要考虑因素，但在大规模知识库（百万级 Chunk）场景下，效率差异会很明显。

**切分也有代价。** 切分打破了文档的原始结构。原本有前后逻辑关系的段落被切成了独立的片段，片段之间的连贯性丢失了。切分做得不好，可能导致一个完整的论述被腰斩，前半段在 Chunk A，后半段在 Chunk B。检索时可能只检索到 Chunk A，答案就不完整。

核心矛盾：**粒度要细（为了检索精准），但上下文要保留（为了理解完整）。** 所有的切分策略都是在平衡这两个需求。

---

## 3 固定长度切分

按照固定的字符数或 Token 数切割文本。设定一个 Chunk Size（比如 500 字符），从文本开头开始，每 500 字符切一段。

纯粹的固定长度切分太粗暴——可能在句子中间、段落中间甚至单词中间切断。通常会做一个改进：按固定长度定位切割点，但向附近最近的句子边界（句号、问号、感叹号）或段落边界（换行符）移动。比如目标是 500 字符，找到 500 字符附近最近的句号，在那里切断。

```python
from langchain.text_splitter import CharacterTextSplitter

splitter = CharacterTextSplitter(
    separator="\n",       # 优先在换行符处切割
    chunk_size=500,       # 目标 Chunk 大小
    chunk_overlap=50,     # 重叠 50 字符
    length_function=len,  # 按字符计数
)

chunks = splitter.split_text(raw_text)
```

这个策略的优势只有一点：实现极其简单，不依赖文档结构，适用于任何文本。代价是不考虑语义边界，丢失文档结构信息，对结构化文档效果明显不如按结构切分。

**结论：不要在生产环境直接使用纯固定长度切分。** 它只适用于没有结构信息的纯文本（如 OCR 输出的无格式文本）、需要快速搭建原型的场景。至少加上句子边界感知（找最近的句号/换行符切割）。更好的做法是直接跳到递归字符切分（第 7 节）——它本质上就是固定长度切分的改良版。

---

## 4 按段落切分

段落级切分比纯固定长度切分在检索准确率上高出 **10-20%**（2024 年多个基准测试结论）。原因直观：自然段落本身就是作者按语义单元组织的，直接复用这个结构比任意位置切割效果好得多。

做法很简单：按照换行符（单换行或双换行）识别段落，每个段落作为一个 Chunk。如果某个段落过长（超过设定的阈值），再对该段落做递归切分。

```python
from langchain.text_splitter import RecursiveCharacterTextSplitter

splitter = RecursiveCharacterTextSplitter(
    separators=["\n\n", "\n"],  # 先按双换行（段落），再按单换行
    chunk_size=800,
    chunk_overlap=100,
)

chunks = splitter.split_text(raw_text)
```

这个策略保持了段落的完整性，语义更连贯，实现也简单。但要注意几个现实问题：有些文档的段落划分不合理，可能一个段落包含多个主题；段落长度差异很大，导致 Chunk 大小不均匀；对于没有段落结构的文档（如 OCR 输出），此方法不适用。适用于有良好段落结构的文档（新闻文章、博客、报告）和中文文档（中文段落边界通常用换行符或缩进表示）。

---

## 5 按结构切分

利用文档的标题层级结构来切分。按标题（H1、H2、H3）来分块，比如每个 H2 下的所有内容作为一个 Chunk，如果某个 H2 下的内容太长，再按 H3 子切分。

```python
from langchain.text_splitter import MarkdownHeaderTextSplitter

headers_to_split_on = [
    ("#", "Header 1"),
    ("##", "Header 2"),
    ("###", "Header 3"),
]

splitter = MarkdownHeaderTextSplitter(
    headers_to_split_on=headers_to_split_on,
)

chunks = splitter.split_text(markdown_text)
# 每个 chunk 会自动附带元数据，如 {"Header 1": "第三章", "Header 2": "退货流程"}
```

注意输出的 `metadata` 字段——`MarkdownHeaderTextSplitter` 会自动把所属的标题层级写入每个 Chunk 的元数据。这个信息至关重要：切分时务必保留标题信息为元数据，用于后续的上下文增强切分（第 8 节）和元数据过滤检索。前文 [文档解析与清洗](document-parsing-and-cleaning.md) 提取的结构信息（标题层级、段落归属）在这里发挥作用。

结构切分的语义完整性是最好的，每个 Chunk 对应一个完整的主题。但它依赖文档有良好的标题结构，不同层级的标题下内容长度差异很大，实现相对复杂（需要解析文档结构）。适用于有明确标题层级的文档（技术文档、产品手册、学术论文）和 Markdown 文档。

---

## 6 语义切分

让模型判断在哪里切分，而不是用固定规则。用 Embedding 模型计算相邻句子的向量相似度，如果两个相邻句子的语义相似度突然下降（低于阈值），说明这里发生了话题转换，是天然的切分边界。

```python
from langchain_experimental.text_splitter import SemanticChunker
from langchain_openai import OpenAIEmbeddings

embeddings = OpenAIEmbeddings(model="text-embedding-3-small")

splitter = SemanticChunker(
    embeddings=embeddings,
    breakpoint_threshold_type="percentile",  # 相似度下降超过 percentile 阈值时切割
    breakpoint_threshold_amount=75,          # 第 75 百分位
)

chunks = splitter.split_text(raw_text)
```

语义切分的切分质量最高，能处理复杂的文档结构，不依赖文档格式。但代价也最高：需要额外的 Embedding 调用，成本高、速度慢，对大文档处理时间很长。它适用于对切分质量要求极高的场景、预算充足的项目、文档结构复杂且无明确格式标记的场景。

**2025 年的变化。** 随着 Embedding 模型推理速度提升和成本下降（如 text-embedding-3-small 的定价已经很低），语义切分的实际成本门槛显著降低。对于中等规模的知识库（万级文档），语义切分的额外成本通常可以接受。如果基础策略效果不理想，语义切分是值得尝试的升级方向。

**调参提示。** 语义切分不是"一刀切"的方案，它的 `breakpoint_threshold` 参数需要针对具体文档调参。建议先在小样本上手动标注理想的切分点，再调整阈值使自动切分结果与人工标注对齐。

---

## 7 递归字符切分（LangChain）

**LangChain 的 `RecursiveCharacterTextSplitter` 是工程实践中最推荐的默认方案。** 它本质上是一个改良版的固定长度切分：按优先级依次尝试不同的分隔符，在保持 Chunk 大小接近目标值的同时，尽量在自然的文本边界处切割。

**核心机制。** 按照分隔符优先级列表依次尝试：先尝试双换行符（`\n\n`，段落边界），如果切出的片段还是太长，再尝试单换行符（`\n`，行边界），再尝试句号（`。` 或 `.`，句子边界），再尝试空格（词边界），最后才逐字符切割。

```python
from langchain.text_splitter import RecursiveCharacterTextSplitter

splitter = RecursiveCharacterTextSplitter(
    separators=["\n\n", "\n", "。", "！", "？", ".", " ", ""],
    chunk_size=512,
    chunk_overlap=64,
    length_function=len,
    is_separator_regex=False,
)

chunks = splitter.split_text(raw_text)
print(f"切分出 {len(chunks)} 个片段")
print(f"平均长度: {sum(len(c) for c in chunks) / len(chunks):.0f} 字符")
```

**为什么推荐它作为默认方案。** 它在简单性和效果之间取得了很好的平衡：

| 维度 | 评价 |
|------|------|
| 实现成本 | 几行代码即可使用 |
| 语义保持 | 优先在段落和句子边界切割，不会腰斩句子 |
| 适用范围 | 不依赖特定文档结构，通用性强 |
| 可控性 | `chunk_size`、`chunk_overlap`、`separators` 都可调 |
| 生态支持 | LangChain 生态中集成度最高 |

**中英文适配。** 默认的 separators 是面向英文的。处理中文文档时，务必在 separators 中加入中文标点（`。`、`！`、`？`、`；`），否则递归切分可能跳过中文句子边界，退化成逐字符切割。

**Token 计量的递归切分。** `RecursiveCharacterTextSplitter` 默认按字符数计量。对于中文，建议改用 Token 计量：

```python
import tiktoken

def token_length(text: str) -> int:
    encoding = tiktoken.get_encoding("cl100k_base")
    return len(encoding.encode(text))

splitter = RecursiveCharacterTextSplitter(
    separators=["\n\n", "\n", "。", ".", " ", ""],
    chunk_size=512,           # 512 tokens
    chunk_overlap=64,         # 64 tokens 的重叠
    length_function=token_length,
)
```

---

## 8 上下文增强切分

切分最大的代价是丢失了文档的结构信息。一个切出来的 Chunk "退货需在签收后 7 天内，保留原包装..." 没有上下文时，模型不知道这是哪个产品、哪个章节的内容。**上下文增强切分**的做法是：在每个 Chunk 前面拼接父级标题层级，人为注入位置上下文。

**具体做法。** 假设原文结构如下：

```
## 3.2 退货流程
退货需在签收后7天内提出，保留原包装...
```

普通切分产出的 Chunk 是：`退货需在签收后7天内提出，保留原包装...`

上下文增强后的 Chunk 是：`## 3.2 退货流程 > 退货需在签收后7天内提出，保留原包装...`

```python
from langchain.text_splitter import MarkdownHeaderTextSplitter
from langchain.text_splitter import RecursiveCharacterTextSplitter

# 第一步：按标题结构切分，保留元数据
headers_to_split_on = [
    ("#", "h1"),
    ("##", "h2"),
    ("###", "h3"),
]

header_splitter = MarkdownHeaderTextSplitter(headers_to_split_on=headers_to_split_on)
header_chunks = header_splitter.split_text(markdown_text)

# 第二步：对过长的片段做二次切分
text_splitter = RecursiveCharacterTextSplitter(
    separators=["\n\n", "\n", "。", ".", " "],
    chunk_size=512,
    chunk_overlap=64,
)

final_chunks = text_splitter.split_documents(header_chunks)

# 第三步：上下文增强——将元数据中的标题层级拼到内容前面
for chunk in final_chunks:
    context_parts = []
    for level in ["h1", "h2", "h3"]:
        if level in chunk.metadata:
            context_parts.append(chunk.metadata[level])
    if context_parts:
        context_prefix = " > ".join(context_parts) + " > "
        chunk.page_content = context_prefix + chunk.page_content
```

**优点：** 为每个 Chunk 提供了位置上下文，模型能理解"这段话属于哪个章节、在讨论什么主题"；检索时标题信息也参与匹配，提高召回率；实现成本中等，收益显著。

**适用场景：** 有明确标题层级的文档（技术文档、产品手册、法律法规）。对于无结构的纯文本，此方法不适用（没有标题层级可以拼接）。

**工程建议。** 上下文增强切分在生产环境中强烈推荐。它是成本最低、收益最高的切分质量提升手段之一。前提是前文 [文档解析与清洗](document-parsing-and-cleaning.md) 已经正确提取了标题层级信息并写入元数据。

---

## 9 Overlap 策略

Overlap 是相邻 Chunk 之间的重叠部分。比如 Chunk 1 覆盖 1-500 字符，Chunk 2 覆盖 400-900 字符，重叠部分是 400-500 字符。

**为什么需要 Overlap。**

避免关键信息被切断。假设一个重要论述的完整内容在 450-550 字符区间，如果没有 Overlap，切分点在 500 字符处，这个论述被切成两半。有 Overlap 的话，两个 Chunk 都包含完整的论述。

增加检索命中率。用户问题和 Chunk 的匹配可能在边界附近。有 Overlap 的话，即使匹配点在边界，两个 Chunk 都能检索到。

提供上下文。每个 Chunk 有一些额外的上下文信息，模型理解 Chunk 时不会因为缺少上下文而误解。

**Overlap 的代价。**

存储成本增加。Overlap 意味着更多的 Chunk、更多的向量、更大的存储需求。

检索噪声增加。Overlap 导致不同 Chunk 包含重复内容，检索时可能返回多个相似的 Chunk，浪费了检索名额（top-k）。

**推荐值：Chunk Size 的 15-25%。**

| Overlap 比例 | 效果 |
|-------------|------|
| 低于 10% | 几乎没有实际效果，边界信息仍然丢失 |
| 10-15% | 有效但覆盖不充分，中等质量文档可接受 |
| **15-25%** | **推荐区间。覆盖绝大多数边界情况，存储成本可控** |
| 25-40% | 边界覆盖充分，但重复内容开始造成检索噪声 |
| 高于 40% | 大量重复内容浪费存储和检索位，不推荐 |

```python
# 推荐的 Overlap 配置
chunk_size = 512   # tokens
overlap = 96       # 约 18.75%，在 15-25% 区间内

splitter = RecursiveCharacterTextSplitter(
    chunk_size=chunk_size,
    chunk_overlap=overlap,
)
```

---

## 10 Chunk Size 的选择

Chunk Size 是切分中最关键的参数。太小则上下文不足，太大则检索不精准。

**2024-2025 年的实证数据。** 多个独立研究在标准基准测试（如 BEIR、MS MARCO）上一致得出了以下结论：

| Chunk Size (tokens) | 检索精度 | 上下文完整性 | 适用场景 |
|---------------------|---------|-------------|---------|
| 64-128 | 精准但脆弱 | 差，频繁丢失上下文 | 精确关键词匹配、FAQ |
| 128-256 | 较高 | 偏弱 | 事实性问答（数字、日期、名称） |
| **256-512** | **高** | **较好** | **通用场景的推荐起点** |
| **512-1024** | **较高** | **好** | **需要上下文的理解性问答** |
| 1024-2048 | 开始下降 | 充分 | 长文档摘要、综合理解 |
| 2048+ | 明显下降 | 过剩 | 不推荐用于标准 RAG |

**甜点区：256-1024 tokens。** 这个范围内的 Chunk Size 在检索精度和上下文完整性之间取得了最佳平衡。低于 256 tokens 的 Chunk 信息量太少，向量表示不够稳定；高于 1024 tokens 的 Chunk 开始出现"语义稀释"——向量是多个主题的平均，对具体问题的匹配精度下降。

**选择依据。**

- **问题类型。** 事实性问答（"XX 是多少"）偏向 256-512 tokens；理解性问答（"XX 的原因是什么"）偏向 512-1024 tokens。
- **文档类型。** 结构化文档（有章节）可以用较大的 Chunk；非结构化文档用较小的 Chunk。
- **模型能力。** Embedding 模型对短文本的表示质量更稳定；长文本的向量表示会有信息损失。
- **实际测试。** 最可靠的方式：用不同 Chunk Size 在测试集上评估效果。评估方法见 [RAG评估与微调](rag-eval-and-finetuning.md)。

**Token 数 vs 字符数。** 切分时用字符数还是 Token 数？**中文必须用 Token 数。** 原因：

- 模型的上下文窗口是按 Token 计算的，用字符数会导致中英文文档的 Chunk 实际大小差异很大。
- 中文字符的 Token 编码长度不固定。常见汉字通常 1-2 tokens，生僻字可能 3+ tokens。一个 500 字符的中文文本，其实际 Token 数可能在 400-800 之间波动。
- 英文场景下字符数和 Token 数的比例相对稳定（约 4 字符 = 1 token），但中文没有这种稳定比例。

```python
import tiktoken

def count_tokens(text: str, model: str = "cl100k_base") -> int:
    """统计文本的 Token 数"""
    encoding = tiktoken.get_encoding(model)
    return len(encoding.encode(text))

# 示例：同一字符数的中文和英文文本，Token 数差异
zh_text = "退货需在签收后七天内提出申请，并保留原包装。"  # 20 字符
en_text = "Returns must be requested within seven days of receiving the item."  # 60 字符

print(f"中文: {count_tokens(zh_text)} tokens ({len(zh_text)} 字符)")
print(f"英文: {count_tokens(en_text)} tokens ({len(en_text)} 字符)")
# 输出类似：
# 中文: 22 tokens (20 字符)
# 英文: 12 tokens (60 字符)
```

---

## 11 切分质量评估

切分质量直接影响 RAG 系统的效果。评估方法分定性和定量两类。

**定性评估。**

人工抽查。随机抽取 20-50 个 Chunk，检查以下指标：
- 语义完整性：Chunk 是否表达了完整的含义，有没有被腰斩
- 信息密度：Chunk 中有效信息的比例，是否包含大量无关内容
- 边界合理性：切割点是否在自然的语义边界

案例分析。设计 10-20 个典型问题，检索 top-k Chunk，检查答案是否在返回的 Chunk 中。

**定量评估。**

| 指标 | 计算方式 | 意义 |
|------|---------|------|
| 检索召回率 | 答案所在 Chunk 是否在 top-k 中 | 切分是否把答案放在了可检索到的位置 |
| Chunk 长度分布 | 均值、标准差、最大最小值 | 分布是否合理，有没有异常长或短的 Chunk |
| 答案质量 | 基于 Chunk 生成的答案的准确性和完整性 | 端到端效果 |
| 重复率 | Overlap 导致的重复内容比例 | Overlap 策略是否合理 |

```python
# 快速统计 Chunk 质量指标
import tiktoken

def analyze_chunks(chunks: list[str]) -> dict:
    encoding = tiktoken.get_encoding("cl100k_base")
    lengths = [len(encoding.encode(c)) for c in chunks]

    return {
        "chunk_count": len(chunks),
        "token_mean": sum(lengths) / len(lengths),
        "token_min": min(lengths),
        "token_max": max(lengths),
        "token_std": (sum((l - sum(lengths)/len(lengths))**2 for l in lengths) / len(lengths))**0.5,
    }

stats = analyze_chunks(chunks)
for k, v in stats.items():
    print(f"{k}: {v:.1f}" if isinstance(v, float) else f"{k}: {v}")
```

**迭代优化流程。**

1. 选定初始策略（推荐：递归字符切分 + Token 计量，chunk_size=512, overlap=96）
2. 在测试集上评估效果
3. 分析失败案例：是 Chunk 太大导致检索不精准，还是太小导致上下文丢失，还是切分点不合理
4. 针对性调整：调整 Chunk Size、Overlap、分隔符优先级，或切换策略
5. 重新评估，对比改进效果
6. 如果基础策略已接近瓶颈，考虑叠加上下文增强切分

---

## 12 延伸阅读

**Late Chunking（Jina AI, 2024）。** 传统流程是"先切分，再向量化"（chunk-then-embed）。Late Chunking 反过来：先对整篇文档做 Embedding，再在向量空间中做切分。这样做的好处是每个 Chunk 的向量表示保留了长距离上下文信息，而不是仅基于自身文本。初步实验显示在长文档检索任务上有提升，但该方法目前仍处于实验阶段，工程成熟度不足，不建议在生产环境直接使用。

**Semantic Chunking 的成本优化。** 2025 年 Embedding 模型的推理速度提升和价格下降使得语义切分的成本门槛大幅降低。对于中等规模知识库（万级文档），语义切分的额外成本通常在可接受范围内。如果基础策略效果不理想，语义切分是值得尝试的升级方向。

**多粒度切分。** 同时生成不同粒度的 Chunk（如 256 tokens 和 1024 tokens），检索时先匹配细粒度 Chunk 定位，再返回对应的粗粒度 Chunk 作为上下文。这种方案在需要精确定位又需要充分上下文的场景中效果显著，代价是存储成本翻倍。

**关联章节：**
- 输入来源：[文档解析与清洗](document-parsing-and-cleaning.md)
- 输出去向：[Embedding与向量数据库](embedding-and-vector-db.md)
- 效果评估：[RAG评估与微调](rag-eval-and-finetuning.md)
