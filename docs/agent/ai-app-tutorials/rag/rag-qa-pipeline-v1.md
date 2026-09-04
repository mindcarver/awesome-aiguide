# RAG 问答链路 v1

## TL;DR

把前面几篇拆开讲的组件（文档解析、Chunking、Embedding、向量数据库）串成一条完整的问答链路。用户提问 -> 向量化 -> 检索 top-k -> 组装 Prompt -> LLM 生成答案 -> 返回带引用的结果。本文提供完整可运行的 `SimpleRAG` 类，基于 `text-embedding-3-small` + `gpt-4o-mini`，支持相似度阈值过滤、元数据检索和流式输出。每次查询成本约 $0.005-0.02。

---

## 1. 概述

前面已经覆盖了 RAG 系统的各个组件：

- [文档解析与清洗](document-parsing-and-cleaning.md)：把 PDF、Markdown 等原始文档转成干净的纯文本
- [Chunking切分策略](chunking-strategies.md)：把长文本切成合适大小的片段
- [Embedding与向量数据库](embedding-and-vector-db.md)：把文本片段向量化并存储到向量数据库

本篇把它们串联起来，构建一个端到端的 RAG 问答链路。

**v1 的设计哲学：跑通，不追求完美。** 从用户提问到获得答案，整条链路能走通、能回答基本问题、能显示引用来源。没有查询改写，没有重排序，没有混合检索。先把骨架搭起来，有了可测量的基线，后续优化才有方向。

为什么要先跑通？因为 RAG 系统的瓶颈往往不在你预想的地方。你以为是 Embedding 模型不够好，实际可能是 Chunk 切分粒度不对；你以为是检索不够准，实际可能是 Prompt 没有引导模型引用检索结果。只有端到端跑起来，才能用数据定位真正的瓶颈。

---

## 2. 架构总览

完整的 RAG 问答链路分为六个阶段：

```
用户提问
    |
    v
[1] 问题预处理 ------ 清洗、格式化
    |
    v
[2] 问题向量化 ------ Embedding API (text-embedding-3-small, 1536维)
    |
    v
[3] 检索 top-k ------ 向量数据库查询 + 阈值过滤 + 元数据过滤
    |
    v
[4] Prompt 组装 ----- 模板填充、Context 拼接、长度控制
    |
    v
[5] 答案生成 ------- LLM API (gpt-4o-mini, temperature=0.1, stream=True)
    |
    v
[6] 引用标注 ------- 从元数据提取来源，附加到答案
    |
    v
返回结果 { answer, sources, metadata }
```

每个阶段的输入输出都很明确，便于单独测试和替换。下面逐个拆解。

---

## 3. 用户问题处理

用户问题处理是 RAG 在线管线的入口。它的任务不只是"拿到问题文本"，还包括必要的预处理。

**问题清洗。** 去除首尾空白、合并多余空格、清理不可见字符（零宽空格、BOM 标记等）。这些不影响 Embedding 的效果（模型本身有鲁棒性），但影响日志记录和 Prompt 展示的可读性。

```python
def clean_question(question: str) -> str:
    """基本清洗：去除首尾空白，合并多余空格"""
    import re
    question = question.strip()
    question = re.sub(r'\s+', ' ', question)  # 合并连续空白
    return question
```

**问题分类（v1 跳过）。** 不是所有输入都适合 RAG 回答。闲聊（"你好"）、命令（"帮我生成报告"）、超出知识库范围的提问（"今天天气"），理想情况下需要分流处理。v1 不做分类，所有输入直接进入检索。但至少在 Prompt 里加一句"如果知识库中没有相关信息，请诚实回答"，作为兜底。

**多轮对话补全（v1 跳过）。** 用户先问"退货政策是什么"，接着问"那换货呢"，第二个问题的"换货"需要上下文补全。v1 不处理多轮对话，每次查询独立。这个能力在 [RAG优化](rag-optimization.md) 中补齐。

**v1 工程决策：** 接收问题文本，做基本清洗，直接进入向量化。不做分类，不做上下文补全。保持简单。

---

## 4. 问题向量化

把清洗后的问题通过 Embedding 模型转换为 1536 维向量。这一步和 [Embedding与向量数据库](embedding-and-vector-db.md) 中离线阶段的向量化操作使用同一个模型。

**模型一致性是硬约束。** 查询时使用的 Embedding 模型必须和文档入库时完全一致。用 `text-embedding-3-small` 入库，就必须用 `text-embedding-3-small` 查询。模型换了，向量空间不同，检索结果毫无意义。

**API 调用示例：**

```python
from openai import OpenAI

client = OpenAI()

def embed_query(question: str) -> list[float]:
    """将问题文本转为向量"""
    response = client.embeddings.create(
        model="text-embedding-3-small",
        input=question
    )
    return response.data[0].embedding
```

**关键参数：**
- `text-embedding-3-small`：1536 维，OpenAI 当前推荐的通用 Embedding 模型
- 单次调用延迟：通常 50-200ms
- 单次调用成本：约 $0.00002（几乎可以忽略）

**生产环境注意事项：**
- 高并发场景需要考虑 API 速率限制，OpenAI 的 Tier 1 默认 500 RPM
- 相同问题的向量可以缓存，避免重复调用（v1 不实现）
- 记录向量化耗时，作为性能监控的基础数据

---

## 5. 检索 top-k

用问题向量在向量数据库中检索最相似的 k 个 Chunk。这是 RAG 的核心环节 -- 检索质量直接决定答案质量。

### 5.1 基本检索

```python
results = collection.query(
    query_embeddings=[query_vector],
    n_results=top_k,
    include=["documents", "metadatas", "distances"]
)
```

### 5.2 相似度阈值过滤

top-k 检索总是返回 k 个结果，即使它们和问题毫不相关。必须设定相似度阈值，过滤掉不相关的结果。

Chroma 返回的是距离（distance），需要转换为相似度：

```python
similarity = 1 - distance  # 余弦距离 -> 余弦相似度
```

阈值建议：
- **0.5 以下：** 几乎不相关，直接丢弃
- **0.5-0.7：** 弱相关，保留但标记低置信度
- **0.7 以上：** 强相关，高质量检索结果

v1 使用固定阈值 0.5。当过滤后没有结果时，返回"未找到相关信息"而非强行生成。

### 5.3 元数据过滤

向量数据库支持在检索时按元数据过滤，缩小检索范围。这在文档量大、类型多的时候尤其有用。

```python
# 只在"产品手册"类文档中检索
results = collection.query(
    query_embeddings=[query_vector],
    n_results=top_k,
    where={"doc_type": "product_manual"}
)

# 只在 2024 年之后更新的文档中检索
results = collection.query(
    query_embeddings=[query_vector],
    n_results=top_k,
    where={"updated_at": {"$gte": "2024-01-01"}}
)
```

元数据过滤在离线入库阶段就需要设计好 schema。每个 Chunk 至少包含：
- `source`：来源文档名称
- `doc_type`：文档类型（产品手册、FAQ、政策文档等）
- `section`：所属章节
- `chunk_index`：在原文中的位置索引

v1 不在查询参数中硬编码元数据过滤，但在返回结果中完整保留元数据，供引用标注使用。

### 5.4 检索结果的格式

每个检索结果应包含：

```python
{
    "content": "原始 Chunk 文本",
    "similarity": 0.82,          # 余弦相似度
    "source": "退货政策v2.pdf",   # 来源文档
    "section": "第三章 退货流程",  # 章节
    "chunk_index": 15            # 片段索引
}
```

---

## 6. Prompt 组装

把检索到的 Chunk 和用户问题组合成发送给 LLM 的 Prompt。Prompt 设计直接决定模型能否正确利用检索到的上下文。

### 6.1 Prompt 模板

```
你是一个专业的知识库问答助手。请基于以下参考内容回答用户的问题。

要求：
1. 只使用参考内容中的信息回答，不要编造
2. 如果参考内容中没有相关信息，回答"未找到相关信息"
3. 在答案中标注引用来源，格式为 [来源N]

参考内容：
{context}

用户问题：
{question}
```

关键设计决策：
- **明确禁止编造。** RAG 的核心价值是减少幻觉，Prompt 必须反复强调"只使用参考内容"
- **提供兜底策略。** "未找到相关信息"比编造答案好得多
- **要求引用标注。** 强制模型指出答案来自哪个参考片段

### 6.2 Context 格式化

把多个 Chunk 拼接成结构化的 Context 字符串：

```python
def format_context(chunks: list[dict]) -> str:
    """将检索到的 Chunk 格式化为 Prompt 中的 Context"""
    parts = []
    for i, chunk in enumerate(chunks, 1):
        source_info = f"来源: {chunk['source']}"
        if chunk.get('section'):
            source_info += f", 章节: {chunk['section']}"
        parts.append(f"[{i}] {source_info}\n{chunk['content']}")
    return "\n\n---\n\n".join(parts)
```

输出示例：

```
[1] 来源: 退货政策v2.pdf, 章节: 第三章 退货流程
自收到商品之日起 7 天内可申请退货。商品需保持原包装完整...

---

[2] 来源: 售后FAQ.md, 章节: 退货常见问题
退货审核一般在 3 个工作日内完成。审核通过后退款将在 5-7 个工作日内到账...
```

### 6.3 长度控制

Context 总长度不能超过模型的上下文窗口。粗略估算：

```python
# 粗略估算：1 个中文字符约 1-2 个 token
MAX_CONTEXT_TOKENS = 3000  # 给 Prompt 模板和答案留足空间

def truncate_context(context: str, max_tokens: int = MAX_CONTEXT_TOKENS) -> str:
    """截断过长的 Context，保留前面的内容（相似度最高的）"""
    # 简单实现：按字符数估算，1 token 约 1.5 个中文字符
    max_chars = max_tokens * 1.5
    if len(context) > max_chars:
        context = context[:int(max_chars)] + "\n\n[...内容已截断]"
    return context
```

更精确的实现可以用 `tiktoken` 库计算 token 数，但 v1 用字符数估算足够。

---

## 7. 答案生成

把组装好的 Prompt 发给 LLM，生成最终答案。

### 7.1 模型选择

| 模型 | 适用场景 | 成本（每百万 token） |
|------|---------|-------------------|
| `gpt-4o-mini` | v1 默认选择，性价比最高 | 输入 $0.15 / 输出 $0.60 |
| `claude-3-5-haiku` | 备选，中文表达流畅 | 输入 $0.80 / 输出 $4.00 |
| `gpt-4o` | 高质量场景，答案准确性要求高 | 输入 $2.50 / 输出 $10.00 |

v1 使用 `gpt-4o-mini`。对于大部分知识库问答场景，`gpt-4o-mini` 的表现足够好。如果答案质量不够，优先优化检索和 Prompt，而非升级模型。

### 7.2 参数设置

```python
response = client.chat.completions.create(
    model="gpt-4o-mini",
    messages=[
        {"role": "system", "content": SYSTEM_PROMPT},
        {"role": "user", "content": user_prompt}
    ],
    temperature=0.1,       # 低温度，追求确定性
    max_tokens=500,        # 控制答案长度
    stream=True            # 流式输出
)
```

- **temperature=0.1：** RAG 场景需要事实性回答，不需要创造性。温度越低，输出越确定。
- **max_tokens=500：** 知识库问答通常不需要长篇大论，200-500 token 足够。
- **stream=True：** 流式输出已经成为标准实践。用户不用等完整答案生成完毕，体验更好。

### 7.3 流式输出处理

```python
def stream_answer(response):
    """处理流式响应，逐块返回文本"""
    full_answer = ""
    for chunk in response:
        if chunk.choices[0].delta.content is not None:
            content = chunk.choices[0].delta.content
            full_answer += content
            yield content
    return full_answer
```

### 7.4 错误处理

API 调用可能失败，需要处理常见异常：

```python
from openai import APITimeoutError, RateLimitError, APIConnectionError

try:
    response = client.chat.completions.create(...)
except RateLimitError:
    # 速率限制，等待后重试
    return {"answer": "服务繁忙，请稍后再试", "sources": []}
except APITimeoutError:
    # 请求超时
    return {"answer": "请求超时，请重试", "sources": []}
except APIConnectionError:
    # 网络连接失败
    return {"answer": "网络异常，请检查连接", "sources": []}
```

v1 采用简单策略：捕获异常，返回友好的错误提示。不做自动重试（避免用户等待过久）。生产环境可以用指数退避重试。

### 7.5 成本估算

单次 RAG 查询的成本拆解：

| 环节 | 模型 | 估算 token | 成本 |
|------|------|-----------|------|
| 问题向量化 | text-embedding-3-small | ~50 token | ~$0.000001 |
| Prompt（含 Context） | gpt-4o-mini | ~1500 token | ~$0.0002 |
| 答案生成 | gpt-4o-mini | ~300 token | ~$0.0002 |
| **总计** | | | **~$0.0004** |

实际使用中加上重试、长 Context 等情况，单次查询成本约 **$0.005-0.02**。以每天 1000 次查询计算，月成本约 $150-600。

---

## 8. 引用标注

在答案中标注引用来源，这是 RAG 区别于普通对话的关键特征。没有引用标注的 RAG 和普通 LLM 聊天没有区别 -- 用户无法验证答案的可靠性。

**v1 采用内联引用 + 尾部来源列表：**

```
根据退货政策，自收到商品之日起 7 天内可申请退货 [1]。退货审核一般在 3 个工作日内完成，
审核通过后退款将在 5-7 个工作日内到账 [2]。

---
来源：
[1] 退货政策v2.pdf > 第三章 退货流程 (相似度: 0.85)
[2] 售后FAQ.md > 退货常见问题 (相似度: 0.78)
```

通过 Prompt 引导模型在答案中使用 `[1]`、`[2]` 标记，然后在返回结果中附加完整的来源信息。

---

## 9. 完整代码示例

以下是 `SimpleRAG` 类的完整实现。这是本文的核心交付物 -- 可直接运行、结构清晰、注释完整。

```python
"""
SimpleRAG v1 - 端到端 RAG 问答链路

依赖：
    pip install openai chromadb

环境变量：
    OPENAI_API_KEY - OpenAI API 密钥

使用前需要先将文档入库，参见 embedding-and-vector-db.md
"""

import os
import re
import time
from typing import Generator

from openai import OpenAI, RateLimitError, APITimeoutError, APIConnectionError
import chromadb
from chromadb.utils import embedding_functions


# ──────────────────────────────────────────
# Prompt 模板
# ──────────────────────────────────────────

SYSTEM_PROMPT = """你是一个专业的知识库问答助手。请严格遵守以下规则：

1. 只使用参考内容中的信息回答问题，不要编造
2. 如果参考内容中没有相关信息，回答"根据现有知识库，未找到相关信息"
3. 在答案中引用具体来源，格式为 [1]、[2] 等
4. 回答要准确、简洁，直接回答问题
"""

USER_PROMPT_TEMPLATE = """参考内容：
{context}

---

用户问题：
{question}"""


class SimpleRAG:
    """RAG 问答链路 v1

    端到端流程：问题清洗 -> 向量化 -> 检索 -> Prompt 组装 -> LLM 生成 -> 返回结果

    模型配置：
        - Embedding: text-embedding-3-small (1536维)
        - Generation: gpt-4o-mini
    """

    # 默认参数
    DEFAULT_TOP_K = 5
    SIMILARITY_THRESHOLD = 0.5
    MAX_CONTEXT_TOKENS = 3000
    GENERATION_MODEL = "gpt-4o-mini"
    EMBEDDING_MODEL = "text-embedding-3-small"

    def __init__(
        self,
        collection_name: str = "knowledge_base",
        db_path: str = "./chroma_db",
        top_k: int = DEFAULT_TOP_K,
        similarity_threshold: float = SIMILARITY_THRESHOLD,
    ):
        """
        Args:
            collection_name: Chroma collection 名称
            db_path: Chroma 持久化存储路径
            top_k: 检索返回的 Chunk 数量
            similarity_threshold: 相似度阈值，低于此值的结果被过滤
        """
        # 初始化 OpenAI 客户端
        self.client = OpenAI()

        # 初始化 Chroma 向量数据库
        self.chroma_client = chromadb.PersistentClient(path=db_path)

        # 初始化 Embedding 函数（必须和入库时使用相同模型）
        self.embedding_fn = embedding_functions.OpenAIEmbeddingFunction(
            api_key=os.getenv("OPENAI_API_KEY"),
            model_name=self.EMBEDDING_MODEL,
        )

        # 获取已有 collection（如果不存在会报错，需要先入库）
        self.collection = self.chroma_client.get_collection(
            name=collection_name,
            embedding_function=self.embedding_fn,
        )

        self.top_k = top_k
        self.similarity_threshold = similarity_threshold

    # ── 第1步：问题预处理 ──────────────────

    def _clean_question(self, question: str) -> str:
        """基本清洗：去除首尾空白，合并多余空格，清理不可见字符"""
        question = question.strip()
        question = re.sub(r'\s+', ' ', question)
        # 去除零宽字符等不可见字符
        question = re.sub(r'[​‌‍﻿]', '', question)
        return question

    # ── 第2步 + 第3步：向量化 + 检索 ────────

    def _retrieve(self, question: str) -> list[dict]:
        """向量化问题并检索相关 Chunk

        Returns:
            检索结果列表，按相似度降序排列，每个元素包含：
            - content: Chunk 原始文本
            - similarity: 余弦相似度
            - source: 来源文档
            - section: 所属章节
            - chunk_index: 片段索引
        """
        results = self.collection.query(
            query_texts=[question],
            n_results=self.top_k,
            include=["documents", "metadatas", "distances"],
        )

        # Chroma 返回嵌套列表，取第一个查询的结果
        documents = results["documents"][0]
        metadatas = results["metadatas"][0]
        distances = results["distances"][0]

        retrieved = []
        for doc, meta, dist in zip(documents, metadatas, distances):
            similarity = 1 - dist  # 余弦距离 -> 余弦相似度

            # 阈值过滤：低于阈值的结果丢弃
            if similarity < self.similarity_threshold:
                continue

            retrieved.append({
                "content": doc,
                "similarity": round(similarity, 4),
                "source": meta.get("source", "未知来源"),
                "section": meta.get("section", ""),
                "chunk_index": meta.get("chunk_index", -1),
            })

        # 按相似度降序排列
        retrieved.sort(key=lambda x: x["similarity"], reverse=True)
        return retrieved

    # ── 第4步：Prompt 组装 ──────────────────

    def _format_context(self, chunks: list[dict]) -> str:
        """将检索结果格式化为 Prompt 中的 Context"""
        parts = []
        for i, chunk in enumerate(chunks, 1):
            source_line = f"[{i}] 来源: {chunk['source']}"
            if chunk["section"]:
                source_line += f" > {chunk['section']}"
            parts.append(f"{source_line}\n{chunk['content']}")

        context = "\n\n---\n\n".join(parts)

        # 长度控制：粗略估算，1 token 约 1.5 个中文字符
        max_chars = self.MAX_CONTEXT_TOKENS * 1.5
        if len(context) > max_chars:
            context = context[:int(max_chars)] + "\n\n[...内容已截断]"

        return context

    def _build_prompt(self, question: str, chunks: list[dict]) -> str:
        """组装完整的用户 Prompt"""
        context = self._format_context(chunks)
        return USER_PROMPT_TEMPLATE.format(context=context, question=question)

    # ── 第5步：答案生成 ──────────────────────

    def _generate(self, prompt: str) -> str:
        """调用 LLM 生成答案（非流式）

        包含基本的错误处理：速率限制、超时、网络异常。
        """
        try:
            response = self.client.chat.completions.create(
                model=self.GENERATION_MODEL,
                messages=[
                    {"role": "system", "content": SYSTEM_PROMPT},
                    {"role": "user", "content": prompt},
                ],
                temperature=0.1,
                max_tokens=500,
            )
            return response.choices[0].message.content

        except RateLimitError:
            return "[系统提示] API 调用频率超限，请稍后重试"
        except APITimeoutError:
            return "[系统提示] 请求超时，请重试"
        except APIConnectionError:
            return "[系统提示] 网络连接异常，请检查网络"
        except Exception as e:
            return f"[系统提示] 生成失败: {type(e).__name__}"

    def _generate_stream(self, prompt: str) -> Generator[str, None, None]:
        """调用 LLM 生成答案（流式）

        逐块 yield 文本片段，适合前端逐字显示。
        """
        try:
            response = self.client.chat.completions.create(
                model=self.GENERATION_MODEL,
                messages=[
                    {"role": "system", "content": SYSTEM_PROMPT},
                    {"role": "user", "content": prompt},
                ],
                temperature=0.1,
                max_tokens=500,
                stream=True,
            )
            for chunk in response:
                delta = chunk.choices[0].delta
                if delta.content is not None:
                    yield delta.content

        except RateLimitError:
            yield "[系统提示] API 调用频率超限，请稍后重试"
        except APITimeoutError:
            yield "[系统提示] 请求超时，请重试"
        except APIConnectionError:
            yield "[系统提示] 网络连接异常，请检查网络"
        except Exception as e:
            yield f"[系统提示] 生成失败: {type(e).__name__}"

    # ── 第6步：引用标注 + 结果组装 ───────────

    def _format_sources(self, chunks: list[dict]) -> list[dict]:
        """格式化来源信息，用于返回给调用方"""
        sources = []
        for i, chunk in enumerate(chunks, 1):
            sources.append({
                "index": i,
                "content": chunk["content"][:100] + "..." if len(chunk["content"]) > 100 else chunk["content"],
                "similarity": chunk["similarity"],
                "source": chunk["source"],
                "section": chunk["section"],
            })
        return sources

    def _format_source_text(self, chunks: list[dict]) -> str:
        """生成尾部来源列表文本"""
        lines = ["\n---\n来源："]
        for i, chunk in enumerate(chunks, 1):
            line = f"[{i}] {chunk['source']}"
            if chunk["section"]:
                line += f" > {chunk['section']}"
            line += f" (相似度: {chunk['similarity']})"
            lines.append(line)
        return "\n".join(lines)

    # ── 主入口 ─────────────────────────────

    def query(self, question: str, stream: bool = False) -> dict:
        """RAG 查询主入口

        Args:
            question: 用户问题文本
            stream: 是否使用流式输出

        Returns:
            {
                "answer": 答案文本,
                "sources": 来源列表,
                "chunks_retrieved": 检索到的 Chunk 数量,
                "latency_ms": 总耗时（毫秒）
            }
        """
        start_time = time.time()

        # 第1步：问题预处理
        question = self._clean_question(question)

        # 第2-3步：向量化 + 检索
        chunks = self._retrieve(question)

        # 检索为空，直接返回
        if not chunks:
            return {
                "answer": "根据现有知识库，未找到与您问题相关的信息。",
                "sources": [],
                "chunks_retrieved": 0,
                "latency_ms": int((time.time() - start_time) * 1000),
            }

        # 第4步：Prompt 组装
        prompt = self._build_prompt(question, chunks)

        # 第5步：答案生成
        if stream:
            # 流式模式：返回生成器，调用方自行消费
            answer_stream = self._generate_stream(prompt)
            sources = self._format_sources(chunks)
            source_text = self._format_source_text(chunks)
            elapsed = int((time.time() - start_time) * 1000)
            return {
                "answer_stream": answer_stream,
                "source_text": source_text,
                "sources": sources,
                "chunks_retrieved": len(chunks),
                "latency_ms": elapsed,
            }
        else:
            answer = self._generate(prompt)

        # 第6步：引用标注
        sources = self._format_sources(chunks)
        source_text = self._format_source_text(chunks)

        elapsed = int((time.time() - start_time) * 1000)

        return {
            "answer": answer + source_text,
            "sources": sources,
            "chunks_retrieved": len(chunks),
            "latency_ms": elapsed,
        }


# ──────────────────────────────────────────
# 使用示例
# ──────────────────────────────────────────

if __name__ == "__main__":
    # 初始化 RAG 系统
    rag = SimpleRAG(
        collection_name="knowledge_base",
        db_path="./chroma_db",
        top_k=5,
        similarity_threshold=0.5,
    )

    # 示例1：标准查询
    print("=" * 60)
    print("示例1：标准查询")
    print("=" * 60)

    result = rag.query("退货的时限是多少天？")
    print(f"\n{result['answer']}")
    print(f"\n[检索到 {result['chunks_retrieved']} 个相关片段，耗时 {result['latency_ms']}ms]")

    # 示例2：流式查询
    print("\n" + "=" * 60)
    print("示例2：流式查询")
    print("=" * 60)

    result = rag.query("如何申请退款？", stream=True)
    print("\n答案：", end="", flush=True)
    for text_chunk in result["answer_stream"]:
        print(text_chunk, end="", flush=True)
    print(result["source_text"])
    print(f"\n[检索到 {result['chunks_retrieved']} 个相关片段，耗时 {result['latency_ms']}ms]")

    # 示例3：知识库外的问题
    print("\n" + "=" * 60)
    print("示例3：知识库外的问题")
    print("=" * 60)

    result = rag.query("今天北京天气怎么样？")
    print(f"\n{result['answer']}")
    print(f"\n[检索到 {result['chunks_retrieved']} 个相关片段，耗时 {result['latency_ms']}ms]")
```

---

## 10. 运行效果

假设知识库中已入库退货政策和售后 FAQ，运行上述代码的预期输出：

```
============================================================
示例1：标准查询
============================================================

根据退货政策，自收到商品之日起 **7 天内** 可以申请退货 [1]。退货时需保持商品原包装完整，不影响二次销售 [1]。退货审核一般在 3 个工作日内完成 [2]。

---
来源：
[1] 退货政策v2.pdf > 第三章 退货流程 (相似度: 0.8732)
[2] 售后FAQ.md > 退货常见问题 (相似度: 0.7945)

[检索到 3 个相关片段，耗时 1823ms]

============================================================
示例2：流式查询
============================================================

答案：用户可以通过以下步骤申请退款：

1. 在"我的订单"中找到对应订单 [1]
2. 点击"申请退款"按钮 [1]
3. 选择退款原因并提交 [1]
4. 等待商家审核，审核通过后退款将在 5-7 个工作日内到账 [2]
---
来源：
[1] 售后FAQ.md > 退款流程 (相似度: 0.8912)
[2] 退货政策v2.pdf > 第四章 退款说明 (相似度: 0.7623)

[检索到 4 个相关片段，耗时 956ms]

============================================================
示例3：知识库外的问题
============================================================

根据现有知识库，未找到与您问题相关的信息。

[检索到 0 个相关片段，耗时 312ms]
```

注意几点：
- 示例3 检索到的所有 Chunk 相似度都低于 0.5 阈值，被全部过滤，系统诚实返回"未找到"
- 流式查询的首次响应通常在 500ms 内开始输出，用户无需等待完整答案
- 耗时中检索占比较大（~200-500ms），LLM 生成占比较大（~500-1500ms）

---

## 11. v1 的局限

这个 v1 版本能跑通，但有很多明确的短板。列出这些局限不是为了自我批评，而是为了给后续优化提供明确的方向。

**检索环节：**
- 没有查询改写（Query Rewriting）。用户问题表述不精确时，检索效果差。比如用户问"能退吗"，系统可能检索不到"退货政策"的内容。
- 没有混合检索（关键词 + 向量）。纯向量检索在某些事实性问答上不如关键词检索，比如查特定的产品型号、订单号。
- 没有重排序（Reranking）。向量检索返回的 top-k 顺序不一定是最优的，用一个专门的 Rerank 模型可以显著提升排序质量。

**生成环节：**
- 没有上下文压缩（Context Compression）。检索到的 Chunk 可能很长，包含大量和问题无关的内容，干扰模型理解。
- 没有多轮对话支持。无法处理追问，每次查询独立。
- 固定的 Prompt 模板。不同类型的问题可能需要不同的 Prompt 策略。

**系统层面：**
- 没有缓存机制。相同问题重复查询浪费资源。
- 没有并发控制。高并发下可能触发 API 速率限制。
- 没有可观测性。缺乏日志、指标、链路追踪。

这些问题的解决方案在后续文章中逐步展开：

- **检索优化：** 查询改写、混合检索、重排序 → [RAG优化](rag-optimization.md)
- **评估体系：** 怎么知道优化是否有效 → [RAG评估与微调](rag-eval-and-finetuning.md)

---

## 12. 延伸阅读

- [Embedding与向量数据库](embedding-and-vector-db.md) -- 向量化原理和向量数据库选型
- [RAG优化](rag-optimization.md) -- 查询改写、混合检索、重排序、上下文压缩等进阶技术
- [RAG评估与微调](rag-eval-and-finetuning.md) -- 如何评估 RAG 系统的效果，以及一个关键问题：检索到的内容到底有没有帮助生成更好的答案？如果去掉检索，答案会变差吗？这种反事实测试（counterfactual evaluation）是衡量 RAG 系统真实价值的关键方法。
