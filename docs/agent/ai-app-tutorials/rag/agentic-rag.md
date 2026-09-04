# Agentic RAG: 从被动检索到主动决策

## TL;DR

Agentic RAG 让 LLM 自主决定检索策略——检索还是不检索、用什么工具、检索几次、何时停止。2026 年 2 月的 A-RAG 论文将其形式化为三要素：自主策略选择、迭代执行、交错工具调用。实践中分三层渐进：路由式 RAG（单次路由） -> 工具式 RAG（多轮工具调用） -> 多 Agent RAG（协作编排）。在此基础上，Self-RAG 引入反思令牌让模型自检，纠正性 RAG（CRAG）在检索后评估质量并自动降级。工程实现首选 LangGraph StateGraph。框架选型看场景：LangGraph 适合复杂工作流，LlamaIndex 适合文档中心应用，RAGFlow/Dify 适合低代码企业部署。注意：简单问答、延迟敏感（5-30s）、成本敏感场景不要用 Agentic RAG。

## 1. 概述

前文已经跑通了 [RAG 问答链路](rag-qa-pipeline-v1.md)，也知道 [检索优化](rag-optimization.md) 的各种手段。但这些优化有一个共同局限：流程是固定的。用户提问 -> 检索 -> 生成，每一步预定义，不会动态调整。

Agentic RAG 打破了这个限制。核心思想：把检索、判断、纠错的能力交给 Agent，让它根据问题类型、检索结果、任务进度自主决策。不是"总是检索 top-k 然后生成"，而是根据情况决定要不要检索、用什么方式检索、检索几次、何时停止。

2026 年 2 月发表的 A-RAG 论文将这一范式系统化，提出了三个核心要素：

- **自主策略选择**：Agent 根据问题复杂度自主选择检索策略，而非遵循固定 pipeline
- **迭代执行**：支持多轮检索-推理循环，每轮根据上轮结果调整
- **交错工具使用**：推理和工具调用交替进行，而非先收集信息再统一推理

这三个要素构成了 Agentic RAG 的理论基础，下面的三层架构是它们在不同复杂度下的工程实现。

## 2. 为什么需要 Agentic RAG

标准 RAG 的流程是线性的：检索 -> 生成，一次就结束。对简单问答够用，但以下场景会力不从心：

- **多跳问题**："A 公司的竞争对手中，哪家去年的营收增长最快？" 需要先找竞争对手列表，再逐一查各家营收数据，最后比较。一次检索不够，每轮查询取决于上一轮结果。
- **不确定是否需要检索**："量子计算的基本原理是什么？" 这种通用知识 LLM 自己就能回答，标准 RAG 无论如何都会检索一次，浪费时间和成本。
- **检索结果需要判断**：检索到 5 个 Chunk，有的相关有的不相关。标准 RAG 全部塞给 LLM，Agentic RAG 可以先过滤、再决定是否补充检索。
- **需要组合多个数据源**：有的问题需要查向量数据库，有的需要查 SQL，有的需要调 API。标准 RAG 只有一个检索路径。

这些问题本质上都指向同一个需求：流程不能是固定的，需要根据情况动态调整。这就是 Agent 的用武之地。

## 3. 核心原则：A-RAG 框架

A-RAG 论文将 Agentic RAG 归纳为以下运作模式：

```text
用户问题
  |
  v
[策略选择] -- 自主判断问题复杂度
  |
  +--> 简单问题 --> 直接生成（不检索）
  +--> 单跳问题 --> 单次检索 + 生成
  +--> 多跳问题 --> 进入迭代循环
  |
  v
[迭代执行循环]
  思考 --> 选择工具 --> 执行 --> 观察结果 --> 继续或停止?
    ^                                        |
    |________________________________________|
    |
  v
[交错工具使用]
  推理步骤1 --> 工具调用A --> 推理步骤2 --> 工具调用B --> ...
```

关键区别：传统 RAG 是"先检索完所有信息，再统一推理"；A-RAG 是"推理和工具调用交替进行，每一步的推理结果决定下一步用什么工具"。这与 [ReAct](../../agent-design-patterns/06-react-reasoning-action-loop.md) 模式的思想一致。

## 4. 第一层：路由式 RAG（Router RAG）

最简单的 Agent 化：在检索前加一个路由器，根据问题类型选择不同的检索策略。

```text
用户问题 --> Router（LLM 或分类器）
  +--> 向量检索（语义问题）
  +--> 关键词检索（精确匹配问题）
  +--> SQL 查询（结构化数据问题）
  +--> 直接回答（通用知识问题，不检索）
  +--> 拒绝回答（超出范围的问题）
```

代码实现：

```python
from typing import Literal
from pydantic import BaseModel, Field
from langchain_core.utils.function_calling import convert_pydantic_to_openai_function

class RouteQuery(BaseModel):
    """将用户问题路由到最合适的数据源"""
    datasource: Literal["vectorstore", "web_search", "direct_answer"] = Field(
        ...,
        description="根据用户问题选择数据源："
                    "vectorstore 用于知识库问答，"
                    "web_search 用于实时信息，"
                    "direct_answer 用于通用知识"
    )

route_function = convert_pydantic_to_openai_function(RouteQuery)
llm_with_route = llm.bind(functions=[route_function])
```

路由式 RAG 解决了"一刀切"的问题，但流程仍然是单次的——路由一次，检索一次，生成一次。它不具备多轮检索能力。

## 5. 第二层：工具式 RAG（Tool-use RAG）

把各种检索能力封装成工具，让 Agent 用 ReAct 模式自主决定调用哪些工具、调用几次。

```python
from langchain_core.tools import tool

@tool
def search_knowledge_base(query: str) -> str:
    """在内部知识库中检索相关信息"""
    results = vectorstore.similarity_search(query, k=3)
    return "\n".join([doc.page_content for doc in results])

@tool
def search_web(query: str) -> str:
    """搜索互联网获取实时信息"""
    return web_search_tool.run(query)

@tool
def query_database(sql: str) -> str:
    """查询结构化数据库"""
    return db.run(sql)

tools = [search_knowledge_base, search_web, query_database]
```

Agent 在 Thought -> Action -> Observation 循环中自主选择工具：

```text
Question: 我们公司的主要竞品中，哪家最近融资最多？

Thought: 需要先查知识库找到公司的主要竞品列表
Action: search_knowledge_base("公司主要竞品列表")
Observation: 主要竞品为 A公司、B公司、C公司

Thought: 需要搜索各竞品最近的融资信息
Action: search_web("A公司 B公司 C公司 最新融资 2026")
Observation: A公司2026年3月完成C轮融资2亿元，B公司...

Thought: 现在可以综合回答了
Final Answer: ...
```

工具式 RAG 解决了多轮检索和多数据源的问题。与路由式 RAG 的区别在于：路由只做一次决策，工具式 RAG 在整个过程中持续决策。

## 6. 第三层：多 Agent RAG（Multi-agent RAG）

对于复杂任务，把不同能力分配给不同的 Agent，由一个协调者（Orchestrator）管理。

```text
用户问题 --> Orchestrator
  +--> 检索 Agent：负责检索和召回
  +--> 分析 Agent：负责数据分析和计算
  +--> 写作 Agent：负责生成最终答案
  +--> 审查 Agent：负责验证答案准确性
```

每个 Agent 有自己的 prompt 和工具，专注于一个职责。Orchestrator 决定任务的分解和分配，以及 Agent 之间的信息传递。

多 Agent RAG 的典型场景：

- **研究报告生成**：检索 Agent 收集资料，分析 Agent 提取数据和趋势，写作 Agent 组织成文，审查 Agent 检查事实准确性
- **投资分析**：检索 Agent 查公司财报和行业数据，分析 Agent 做财务建模和估值，写作 Agent 生成研报
- **客服升级**：一线 Agent 查知识库，解决不了时升级到专家 Agent，专家 Agent 可以调内部系统

## 7. Self-RAG：让模型自检

Self-RAG（Self-Reflective RAG）的核心创新是引入反思令牌（reflection tokens），让模型在生成过程中自我评估：

| 反思令牌 | 含义 | 作用 |
|----------|------|------|
| `[Retrieve: Yes/No]` | 是否需要检索 | 模型自主决定，而非每次都检索 |
| `[IsRelevant]` | 检索结果是否相关 | 过滤无关文档 |
| `[IsFaithful]` | 生成内容是否忠于检索结果 | 防止幻觉 |
| `[IsUseful]` | 生成内容是否有用 | 质量把关 |

工作流程：

```text
用户问题
  |
  v
模型生成 [Retrieve: Yes/No]
  |
  +--> [No] --> 直接生成回答
  +--> [Yes] --> 检索 --> 评估 [IsRelevant]
                     |
                     +--> 不相关 --> 换查询重试
                     +--> 相关 --> 生成回答 --> 评估 [IsFaithful]
                                                      |
                                                      +--> 不忠实 --> 重新生成
                                                      +--> 忠实 --> 输出
```

Self-RAG 需要在训练阶段就让模型学会生成这些反思令牌。对于没有经过专项训练的模型，可以用 prompt 工程模拟类似行为：

```python
SELF_RAG_PROMPT = """你是一个具有自省能力的问答助手。

对于每个问题，按以下流程处理：
1. 判断是否需要检索外部信息。如果问题涉及最新事实、专业知识或具体数据，输出 [Retrieve: Yes]；否则输出 [Retrieve: No] 并直接回答。
2. 如果检索到了文档，逐一评估相关性。输出 [IsRelevant: Yes/No] 标注每个文档。
3. 基于相关文档生成回答，并评估回答是否忠实于检索内容。输出 [IsFaithful: Yes/No]。
4. 如果不忠实，重新生成。

当前问题：{question}
检索结果：{documents}
"""
```

这种方式不如原生训练的效果好，但在通用模型上也能提供一定程度的自检能力。更系统的评估方法参见 [RAG 评估与微调](rag-eval-and-finetuning.md)。

## 8. 纠正性 RAG（Corrective RAG）

纠正性 RAG（CRAG）在检索后增加了质量评估环节：如果检索结果质量不够，自动修正检索策略。

```text
用户问题 --> 检索 --> 质量评估
                      |
                      +--> 相关性高 --> 直接生成
                      +--> 相关性低 --> 查询改写 --> 重新检索
                      +--> 完全无关 --> Web 搜索回退
```

代码实现：

```python
from langgraph.graph import StateGraph, START, END

def grade_documents(state):
    """评估检索结果的相关性"""
    question = state["question"]
    documents = state["documents"]

    filtered_docs = []
    for doc in documents:
        score = llm.invoke(
            f"判断以下文档是否与问题相关。\n"
            f"问题：{question}\n"
            f"文档：{doc.page_content}\n"
            f"只回答 relevant 或 irrelevant"
        )
        if "relevant" in score.lower():
            filtered_docs.append(doc)

    if len(filtered_docs) == 0:
        # 全部不相关，回退到 web 搜索
        return {"documents": [], "action": "web_search"}
    elif len(filtered_docs) < len(documents) * 0.5:
        # 不到一半相关，尝试查询改写
        return {"documents": filtered_docs, "action": "rewrite"}
    else:
        # 大部分相关，直接生成
        return {"documents": filtered_docs, "action": "generate"}

def rewrite_query(state):
    """改写查询以提升检索质量"""
    question = state["question"]
    rewritten = llm.invoke(
        f"将以下问题改写为更适合检索的查询。保持原意不变，但使查询更具体明确。\n"
        f"原问题：{question}"
    )
    return {"question": rewritten, "action": "retrieve"}
```

CRAG 的三路分支（直接生成 / 改写重检 / Web 搜索）本质上是一个小型的路由决策，与第 4 节的路由式 RAG 思路一致，只是决策点从"检索前"移到了"检索后"。

## 9. LangGraph 实现

LangGraph 是实现 Agentic RAG 的主流框架。核心是状态图（StateGraph）：定义节点（处理步骤）和边（流转逻辑）。

### 完整的带纠正能力的 RAG Agent

```python
from typing import Annotated, Literal
from typing_extensions import TypedDict
from langgraph.graph import StateGraph, START, END
from langgraph.graph.message import add_messages
from langgraph.prebuilt import ToolNode, tools_condition

# 定义状态
class RAGState(TypedDict):
    messages: Annotated[list, add_messages]
    question: str
    documents: list
    generation: str
    action: str

# 定义图
graph = StateGraph(RAGState)

# 节点1: 检索
def retrieve(state):
    docs = retriever.invoke(state["question"])
    return {"documents": docs}

# 节点2: 文档评估
def grade_docs(state):
    return grade_documents(state)

# 节点3: 生成
def generate(state):
    context = "\n".join([doc.page_content for doc in state["documents"]])
    response = llm.invoke(
        f"基于以下上下文回答问题。\n"
        f"上下文：{context}\n"
        f"问题：{state['question']}"
    )
    return {"generation": response}

# 节点4: 查询改写
def rewrite(state):
    return rewrite_query(state)

# 节点5: Web 搜索回退
def web_search(state):
    results = web_search_tool.invoke(state["question"])
    return {"documents": [Document(page_content=results)]}

# 添加节点
graph.add_node("retrieve", retrieve)
graph.add_node("grade", grade_docs)
graph.add_node("generate", generate)
graph.add_node("rewrite", rewrite)
graph.add_node("web_search", web_search)

# 条件路由：根据评估结果决定下一步
def decide_after_grade(state):
    action = state["action"]
    if action == "generate":
        return "generate"
    elif action == "rewrite":
        return "rewrite"
    else:
        return "web_search"

# 添加边
graph.add_edge(START, "retrieve")
graph.add_edge("retrieve", "grade")
graph.add_conditional_edges("grade", decide_after_grade, {
    "generate": "generate",
    "rewrite": "rewrite",
    "web_search": "web_search",
})
graph.add_edge("rewrite", "retrieve")   # 改写后重新检索
graph.add_edge("web_search", "generate")  # web 搜索后直接生成
graph.add_edge("generate", END)

# 编译
app = graph.compile()
```

关键设计决策：

- **条件边**：`decide_after_grade` 根据文档评估结果决定走哪条路径。这是 CRAG 的核心。
- **循环**：改写 -> 重新检索 -> 重新评估。`recursion_limit` 控制最大循环次数，防止无限检索。
- **回退机制**：全部不相关时走 Web 搜索，保证总能给出答案。

更多工程实践经验参见 [高级专题与工程实战](advanced-topics-and-engineering.md)。

## 10. 框架选型

| 框架 | 核心能力 | 适用场景 | 上手难度 |
|------|----------|----------|----------|
| **LangChain + LangGraph** | 图式编排，条件分支/循环/人工审核，细粒度控制 | 自定义工作流，复杂 Agent 逻辑 | 中高 |
| **LlamaIndex** | 丰富索引类型，Router Engine 开箱即用，SubQuestionQueryEngine | 以文档为中心的 RAG 应用 | 中 |
| **RAGFlow** | 深度文档解析（80k+ star），可视化编排，模板化 | 企业级文档问答，非代码用户 | 低 |
| **Dify** | 可视化工作流编排，插件生态，团队协作 | 快速搭建原型，低代码团队 | 低 |
| **Coze（扣子）** | 字节出品，强项在对话式 AI，插件市场 | 对话机器人，C 端应用 | 低 |

选型建议：

- **快速验证**：LlamaIndex 的 Router Engine，几行代码实现路由式 RAG
- **复杂工作流**：LangGraph，支持条件分支、循环、人工审核等复杂逻辑
- **企业部署**：RAGFlow 或 Dify，开箱即用的文档处理和权限管理
- **C 端对话产品**：Coze，对话体验优化好，插件生态丰富

## 11. 何时用 / 何时不用

**适合用 Agentic RAG**：

- 多跳推理问题（答案需要从多个文档综合推理）
- 多数据源场景（向量数据库 + SQL + API + Web 搜索）
- 需要动态调整策略的场景（有时需要检索，有时不需要）
- 复杂业务流程（检索后需要分析、计算、比较）
- 对准确性要求高（Self-RAG 的自检机制可以降低幻觉率）

**不适合用 Agentic RAG**：

- **简单的单文档问答**：标准 RAG 就够用，Agent 增加了不必要的复杂度。参见 [RAG 问答链路](rag-qa-pipeline-v1.md)。
- **对延迟敏感的场景**：Agent 的多轮决策会增加响应时间，通常 5-30 秒。如果要求秒级响应，标准 RAG 是更好的选择。
- **成本敏感的大规模应用**：Agent 每次决策都是 LLM 调用。标准 RAG 每次查询调 2 次 LLM（嵌入 + 生成），Agentic RAG 可能调 5-15 次。日查询量大时成本差距显著。

实用策略：先用标准 RAG 跑通基线，遇到解决不了的问题时逐步引入 Agent 能力——先加路由，再加工具调用，然后加纠正机制，最后做多 Agent 协作。不要一开始就上最复杂的架构。

## 12. 延伸阅读

- [RAG 优化](rag-optimization.md) -- 检索策略、重排序、查询改写等优化手段
- [RAG 评估与微调](rag-eval-and-finetuning.md) -- RAG 系统的评估方法和微调策略
- [高级专题与工程实战](advanced-topics-and-engineering.md) -- 生产环境部署和工程实践
- [A-RAG 论文](https://arxiv.org/abs/2502.02579) (2026.02) -- Agentic RAG 的系统化定义与评估
- [Self-RAG](https://arxiv.org/abs/2310.11511) -- 反思令牌与模型自检机制
- [Corrective RAG (CRAG)](https://arxiv.org/abs/2401.15884) -- 检索质量评估与自动纠正
- [Adaptive RAG](https://arxiv.org/abs/2403.14403) -- 根据问题复杂度自适应选择检索策略
