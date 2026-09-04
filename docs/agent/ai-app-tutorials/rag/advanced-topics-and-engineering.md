# 高级专题与工程实战

**TL;DR**: GraphRAG 解决跨文档推理和全局性问答，LightRAG 把成本降到 Microsoft GraphRAG 的十分之一。Text-to-SQL 在结构化数据上碾压文本检索。RAG Fusion 用 RRF 算法优雅地合并多查询结果。生产成本约 $0.005-0.02/查询，框架首选 RAGFlow（80k+ star）。不要一步到位，按 8 步迭代流程逐步构建。

## 概述

前面的文章覆盖了 RAG 的基础管线和常见[优化手段](rag-optimization.md)。本文进入三个方向：基于知识图谱的 GraphRAG、Text-to-SQL 结构化检索、以及从原型到生产的工程落地。

## 一、GraphRAG：知识图谱增强的检索

标准 RAG 的检索单位是文本 Chunk。这对事实性问答够用，但以下场景会力不从心：

- **跨文档推理**："A 项目和 B 项目在技术选型上的共同点是什么？" 答案分散在多个文档中，需要理解实体间关系。
- **全局性问答**："公司所有项目的技术栈分布是怎样的？" 不是检索一两个 Chunk 能回答的，需要汇总全局信息。
- **多跳推理**："A 项目的负责人之前做过什么项目？" 需要先找到负责人，再查历史项目——链式关系。

GraphRAG 把知识组织成**实体-关系图**，而不是扁平的文本 Chunk。

### Microsoft GraphRAG 的工作流程

**离线构建知识图谱：**

1. **实体关系抽取**：用 LLM 从每个 Chunk 中抽取实体（人、组织、项目）和关系（"A 使用 B"、"A 负责 C"）
2. **实体归一化**：合并同一实体的不同表述（"张三"、"Zhang San"、"张总" → 同一个节点）
3. **社区检测**：用 Leiden 算法把紧密关联的实体聚类成社区
4. **层次化摘要**：为每个社区生成摘要，形成层次结构

**在线查询支持两种模式：**

- **本地搜索**：针对特定实体的查询，找相关实体及其邻居节点 + 原始文本。适合"X 是什么"。
- **全局搜索**：利用社区摘要做 Map-Reduce——先从每个社区摘要提取信息，再汇总。适合"总结一下"。

**代价。** Microsoft GraphRAG 处理一份文档需要数百次 LLM 调用来构建图谱，成本和耗时都很高。只有在真正需要跨文档推理的场景下才值得。

### LightRAG：成本降低 10 倍

LightRAG（EMNLP 2025）的核心创新是**增量图谱更新**：新文档到达时，只更新图谱中受影响的部分，而不是重建整个图谱。这把构建成本降到了 Microsoft GraphRAG 的约十分之一。

### 实战：Neo4j + LlamaIndex

```python
from llama_index.graph_stores import Neo4jGraphStore
from llama_index import KnowledgeGraphIndex

graph_store = Neo4jGraphStore(
    username="neo4j", password="password", url="bolt://localhost:7687",
)

kg_index = KnowledgeGraphIndex.from_documents(
    documents, graph_store=graph_store, max_triplets_per_chunk=10,
)

# 查询：支持实体关系的多跳推理
query_engine = kg_index.as_query_engine(
    include_text=True, similarity_top_k=5, embedding_mode="hybrid",
)
response = query_engine.query("A 项目负责人之前做过什么项目？")
```

### GraphRAG 适用判断

| 场景 | 是否需要 GraphRAG | 原因 |
|------|------------------|------|
| 单文档事实性问答 | 不需要 | 标准 RAG 足够 |
| 跨文档实体关系推理 | 需要 | 需要理解实体间的链式关系 |
| 全局性汇总问题 | 需要 | 需要聚合多个文档的信息 |
| 精确数据查询（价格、库存） | 不需要 | Text-to-SQL 更合适 |

## 二、Text-to-SQL：结构化数据的正确打开方式

对于结构化/半结构化数据（数据库、Excel），不要走文本检索路线——让 LLM 生成 SQL 查询，直接查数据库。

**为什么 Text-to-SQL 碾压文本检索。** "SKU12345 的价格是多少"这种问题，文本检索需要把每个 SKU 的价格信息都 Embedding 化，还可能检索到错误的 SKU。Text-to-SQL 直接生成 `SELECT price FROM products WHERE sku = 'SKU12345'`，精确、快速、零幻觉。

```python
from langchain.chains import create_sql_query_chain
from langchain_community.utilities import SQLDatabase

db = SQLDatabase.from_uri("sqlite:///products.db")
chain = create_sql_query_chain(llm, db)

# 用户问题 → SQL → 执行 → 结果
question = "SKU12345的价格是多少？"
sql_query = chain.invoke({"question": question})
result = db.run(sql_query)
```

**注意。** Text-to-SQL 需要：（1）数据库 schema 清晰；（2）用户问题涉及的数据在数据库中；（3）执行前做安全检查，防止 SQL 注入和危险操作（DELETE、DROP）。

## 三、RAG Fusion：多查询结果融合

RAG Fusion 是[多查询检索](rag-optimization.md)的增强版，核心用 **RRF（Reciprocal Rank Fusion，倒数秩融合）** 算法合并结果。

**为什么用 RRF 而不是简单合并。** 不同查询返回的结果有不同的"重要性"——原始问题的直接改写应该比较远的扩展权重更高。RRF 只依赖排名位置，不依赖原始分数的绝对值，天然支持跨查询的结果融合。

```python
def reciprocal_rank_fusion(results_list, k=60):
    """
    results_list: 多个查询各自的检索结果列表
    k: 平滑参数，通常设 60
    """
    fused_scores = {}

    for results in results_list:
        for rank, doc in enumerate(results):
            if doc.id not in fused_scores:
                fused_scores[doc.id] = 0
            # RRF 公式：1 / (k + rank)
            fused_scores[doc.id] += 1.0 / (k + rank + 1)

    reranked = sorted(fused_scores.items(), key=lambda x: x[1], reverse=True)
    return reranked
```

RRF 的优势：不同查询的相似度分数不可直接比较（量纲不同），但排名位置是可比的。RRF 只看排名，避免了分数归一化的问题。

## 四、多模态 RAG

标准 RAG 只处理文本。知识库中的图片、表格、视频需要额外处理。三种路径：

| 路径 | 方法 | 优势 | 劣势 |
|------|------|------|------|
| 提取为文本 | OCR、表格识别、图片描述 | 复用现有管线，实现简单 | 丢失视觉信息（颜色、布局） |
| 多模态 Embedding | CLIP/SigLIP 统一向量空间 | 保留视觉信息 | 语义理解能力弱于纯文本模型 |
| 多模态 LLM | 直接传图给 GPT-4o/Claude | 效果最好，信息不丢失 | 成本高，推理费用是纯文本的 3-5 倍 |

**选型建议。** 如果图片主要是文字（截图、扫描件），走路径 1。如果需要理解图片内容（产品图、设计稿），走路径 3。路径 2 适合需要用文字搜图片的场景。

## 五、RAG 的 12 个痛点及解决方案

| # | 痛点 | 原因 | 解决方案 |
|---|------|------|----------|
| 1 | 数据质量差 | 格式混乱、内容过时 | [文档解析](document-parsing-and-cleaning.md)阶段严格处理 |
| 2 | 分块粒度不当 | Chunk 太大检索不准，太小缺上下文 | [实验调优](chunking-strategies.md)，256-1024 tokens |
| 3 | 检索不准 | 纯向量检索在精确匹配上表现差 | 混合检索 + [Reranker](rag-optimization.md) |
| 4 | 上下文丢失 | 切分打破文档原始结构 | 父子文档检索、上下文增强切分 |
| 5 | LLM 幻觉 | 模型在检索内容之外自由发挥 | 引用标注 + [反事实测试](rag-eval-and-finetuning.md) |
| 6 | 长尾知识 | 稀有领域知识检索不到 | GraphRAG 或微调 Embedding |
| 7 | 多语言 | 中英文混合、术语翻译不一致 | 多语言模型（BGE-M3、multilingual-e5） |
| 8 | 实时性 | 文档更新后知识库未同步 | 增量索引、定时同步、Web 搜索回退 |
| 9 | 安全性 | 不同用户不应看到同一份文档 | 检索时按用户角色过滤 Chunk |
| 10 | 成本 | API 调用费用累积 | 缓存热门查询、用小模型处理简单问题 |
| 11 | 延迟 | 检索 + Rerank + 生成链路过长 | ANN 索引、异步流水线、流式输出 |
| 12 | 评估困难 | 不知道效果好不好 | [RAGAS 自动评估](rag-eval-and-finetuning.md) + 人工抽查 |

## 六、生产级部署

### 框架选型

| 框架 | Star | 核心优势 | 适用场景 |
|------|------|---------|---------|
| **RAGFlow** | 80k+ | 深度文档解析、可视化编排、Agentic RAG | 企业级文档问答 |
| **Dify** | — | 拖拽式工作流、插件生态、团队协作 | 需要可视化编排的团队 |
| **FastGPT** | — | 中文优化、开箱即用知识库问答 | 中文场景快速搭建 |
| **Coze（扣子）** | — | 字节出品，对话式 AI 强项 | 对话机器人 |

选型建议：快速验证用 LlamaIndex Router Engine，复杂工作流用 LangGraph，企业部署用 RAGFlow 或 Dify。

### 向量数据库选型

| 场景 | 推荐 | 原因 |
|------|------|------|
| 原型开发 | Chroma | 几行代码启动 |
| 已有 PostgreSQL | pgvector | 不引入新组件 |
| 单机生产 | Qdrant | Rust 实现，性能好 |
| 分布式生产 | Milvus | 集群部署，千万级向量 |
| 图谱增强 | Neo4j | 向量 + 图查询 |

2026 年趋势：越来越多的团队用 pgvector 或 sqlite-vec，复用现有数据库而非引入独立的向量数据库。

### 成本分析（2026）

| 组件 | 单价 | 说明 |
|------|------|------|
| Embedding | $0.02-0.10/M tokens | 入库时一次性成本 |
| 向量检索 | 几乎为零 | ANN 索引，毫秒级 |
| Rerank | $0.001-0.005/次 | Cross-Encoder 推理 |
| LLM 生成 | $0.15-5.00/M tokens | 取决于模型（GPT-4o-mini 便宜，GPT-4o 贵） |
| **端到端** | **$0.005-0.02/查询** | 典型配置 |

## 七、最佳实践流程

不要一步到位。按以下步骤逐步迭代：

```text
1. 数据集准备     → 收集代表性文档，准备评估测试集（50+ 问题）
2. 定义评价指标   → 选 2-3 个核心指标（Hit Rate + Faithfulness + Answer Relevancy）
3. 无检索基线     → 直接让 LLM 回答，记录基准（通常很差）
4. 朴素 RAG       → 用 [RAG问答链路v1](rag-qa-pipeline-v1.md) 跑通，记录基线
5. 对比检索器     → 尝试不同 Embedding 模型，找效果最好的
6. 参数调优       → 调整 Chunk Size、Overlap、top-k
7. 检索优化       → 逐步加 Reranker、Hybrid Search、Query Rewrite
8. 评估微调       → 如果仍有瓶颈，考虑微调 Embedding 或 Reranker
```

每一步都要量化评估。如果某一步没带来指标提升，说明这个优化不适合你的场景，跳过它。

## 八、研究前沿

**LightRAG（EMNLP 2025）。** 增量图谱更新，构建成本降到 Microsoft GraphRAG 的十分之一。适合需要频繁更新知识库的场景。

**RankRAG（NVIDIA）。** 把检索和重排序统一到一个模型。传统 RAG 需要 Embedding + Reranker 两个模型，RankRAG 一个模型同时做两件事，减少系统复杂度和延迟。

**RAG 2.0。** 端到端联合训练——Embedding、检索、Reranker、LLM 所有组件协同优化。目前处于研究阶段，但代表了 RAG 的终极形态：各组件之间的"语言"完全一致，不再有信息损耗。

**推测性检索（Speculative Retrieval）。** 预测用户下一个问题并预检索。在对话式 RAG 场景中，可以在用户阅读当前答案时预取下一轮可能需要的 Chunk，降低感知延迟。仍在实验阶段。

**检索归因（Retrieval Attribution）。** 2026 年的新方向：不只是标注"答案来自哪个 Chunk"，而是精确到"答案的每个语句，有多大程度受哪个 Chunk 影响"。这对 EU AI Act 合规和反事实测试都很重要。

## 延伸阅读

- [Microsoft GraphRAG](https://microsoft.github.io/graphrag/) — 知识图谱增强 RAG 的开源实现
- [LightRAG](https://arxiv.org/abs/2410.05779) — 轻量级 GraphRAG
- [RankRAG](https://arxiv.org/abs/2407.02485) — NVIDIA 的检索-排序统一模型
- [RAGFlow](https://github.com/infiniflow/ragflow) — 80k+ star 的开源 RAG 引擎
- [Toward RAG 2.0](https://arxiv.org/abs/2410.05779) — 端到端训练的 RAG 系统愿景
