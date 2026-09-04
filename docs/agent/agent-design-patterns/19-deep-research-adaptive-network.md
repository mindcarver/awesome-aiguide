# 深度调研：Deep Research 与自适应网络

**TL;DR：** Deep Research 模式是 2024-2025 年最热门的 Agent 应用之一——OpenAI、Perplexity、Google 都推出了"深度调研"产品。它的核心是多轮搜索-综合循环：Agent 不是搜一次就回答，而是搜索 → 阅读 → 发现新问题 → 再搜索 → 再阅读 → 综合报告。典型执行时间 3-10 分钟，成本 $0.5-5/次。自适应 Agent 网络是更前沿的方向：Agent 网络的拓扑结构不是预定义的，而是根据任务动态调整。

## 它解决什么失控点

### Deep Research：单次搜索的浅层化

RAG（检索增强生成）解决的是"LLM 不知道实时信息"的问题，但它通常是单次检索——搜一次，拿回几段文本，基于这些文本回答。对于复杂问题，单次检索不够：

- "对比 AWS、Azure、GCP 在 Serverless 方面的定价和性能" — 需要查三个产品的文档，还需要查对比评测
- "2024 年 LLM Agent 框架的技术选型建议" — 需要搜框架列表、各自文档、社区评价、性能基准

Deep Research 解决的是**单次检索的深度不足**：通过多轮迭代搜索，逐步深入，发现并填补信息缺口。

### 自适应网络：固定拓扑的僵化

前面讨论的多 Agent 模式（Swarm、Crew、Debate）都是预定义拓扑——Agent 之间的关系和交互方式在任务开始前就确定了。但如果任务类型不可预测，固定拓扑要么过于复杂（为所有可能情况设计），要么过于简单（覆盖不了实际需求）。

自适应网络解决的是**拓扑僵化**：根据任务动态组建 Agent 网络，任务完成后解散。

## Deep Research：多轮搜索-综合循环

### 核心架构

```text
用户提问
  ↓
规划：分解问题，制定搜索计划
  ↓
搜索循环（重复 3-10 次）：
  1. 根据当前知识缺口，生成搜索查询
  2. 执行搜索，获取结果
  3. 阅读最相关的结果
  4. 提取关键信息
  5. 评估信息完整性
  6. 发现新的子问题或缺口
  ↓
综合：组织所有信息，生成结构化报告
```

这个模式的关键特点是**搜索驱动的迭代**——每轮搜索的结果决定下一轮搜什么。这不是预定义的多步流程，而是根据信息缺口动态调整。

### 与普通 RAG 的区别

| 维度 | 普通 RAG | Deep Research |
|------|---------|--------------|
| 搜索次数 | 1 次 | 3-10 次 |
| 查询生成 | 基于用户原始问题 | 基于当前知识缺口动态调整 |
| 信息处理 | 取 top-k 片段 | 阅读完整文章，提取结构化信息 |
| 时间 | 1-5 秒 | 3-10 分钟 |
| 成本 | $0.001-0.01 | $0.5-5 |
| 输出 | 直接回答 | 结构化调研报告 |

### 实现框架

```python
# Deep Research 的核心循环（简化版）
class DeepResearchAgent:
    def __init__(self, model, search_tool, max_hops=5):
        self.model = model
        self.search = search_tool
        self.max_hops = max_hops
        self.knowledge = []  # 已收集的知识
        self.gaps = []       # 待填补的知识缺口

    def research(self, question):
        # 第 1 步：规划
        plan = self.model.invoke(
            f"分析以下问题，列出需要调研的关键方面：\n{question}"
        )
        self.gaps = plan.key_aspects

        # 第 2 步：搜索循环
        for hop in range(self.max_hops):
            if not self.gaps:
                break  # 所有缺口已填补

            # 选择下一个要填补的缺口
            current_gap = self.gaps.pop(0)

            # 生成搜索查询
            query = self.model.invoke(
                f"为了回答'{current_gap}'，最有效的搜索查询是什么？"
            )

            # 执行搜索
            results = self.search(query)

            # 阅读和提取
            extracted = self.model.invoke(
                f"从以下搜索结果中提取与'{current_gap}'相关的关键信息：\n{results}"
            )
            self.knowledge.append(extracted)

            # 发现新缺口
            new_gaps = self.model.invoke(
                f"基于目前的知识，关于原始问题'{question}'，"
                f"还有哪些重要信息缺失？\n"
                f"已有知识：{self.knowledge}"
            )
            self.gaps.extend(new_gaps.missing_topics)

        # 第 3 步：综合
        report = self.model.invoke(
            f"基于以下调研结果，写一份结构化的调研报告：\n"
            f"问题：{question}\n"
            f"调研结果：{self.knowledge}"
        )
        return report
```

### 各家产品的实现差异

| 产品 | 核心差异 | 搜索轮数 | 输出格式 |
|------|---------|---------|---------|
| OpenAI Deep Research | o3 模型 + 强化学习微调，自主决定搜索策略 | 5-30 分钟 | 带引用的长报告 |
| Perplexity Deep Research | 迭代检索 + 动态模型选择 | 2-5 分钟 | 带来源的精炼回答 |
| Google Gemini Deep Research | 交互式规划（用户可编辑研究计划），1M token 窗口 | 3-10 分钟 | 可导出 Google Docs |
| Grok DeepSearch | 段落级处理 + 来源可信度评分，实时信息获取强 | 1-5 分钟 | 带可信度标注的回答 |

### 基准数据（GAIA / HLE / GPQA）

来自对 20+ Deep Research 系统的系统化评测（arxiv 2506.18096）：

**GAIA 基准（通用 AI 助手）**：

| 系统 | Level 1 | Level 2 | Level 3 | 平均 |
|------|---------|---------|---------|------|
| OpenAI DR (o3) | 82.8% | 70.5% | 49.0% | **67.4%** |
| Grok DeepSearch | — | — | — | ~60% |
| Perplexity DR | — | — | — | ~55% |

**HLE 基准（人类最后的考试，专家级难题）**：OpenAI DR 26.6% | Grok ~22% | 其他 <20%

**GPQA 基准（研究生水平问答）**：Grok DeepSearch **84.6%** | OpenAI DR ~78%

差距说明：OpenAI DR 在综合推理上领先，Grok 在专业知识问答上有优势——不同 Deep Research 系统各有擅长。

### 成本与时间

Deep Research 是"重"操作——一次调研的成本和时间是普通查询的 50-100 倍。适用场景：

**适合**：
- 一次性高价值调研（技术选型、竞品分析、市场研究）
- 用户愿意等待 5-10 分钟换取更完整的答案
- 问题复杂度超出单次 RAG 的能力

**不适合**：
- 实时问答（"今天天气怎么样"）
- 批量处理（每个都跑 5 分钟不可接受）
- 简单事实查询（直接 RAG 就够了）

### 与 Storm 模式的关系

[元认知章节](10-metacognition-self-discover-storm.md)中的 Storm 模式（Stanford）本质上是 Deep Research 在长文生成领域的应用：先搜资料写大纲，再按大纲逐节搜索补充，最后合并精炼。区别在于 Storm 侧重"写文章"，Deep Research 侧重"回答问题"。

## 自适应 Agent 网络

自适应 Agent 网络是一个前沿方向，目前还没有成熟的工业框架。核心思想：Agent 网络的拓扑结构根据任务动态生成。

### 固定拓扑 vs 自适应拓扑

```text
固定拓扑（Crew、Swarm）：
  预定义 Agent A → B → C
  无论任务是什么，都走同样的拓扑

自适应拓扑：
  任务：代码审查
    → 动态组建：[语法检查Agent] + [安全审查Agent] + [性能分析Agent]

  任务：市场分析
    → 动态组建：[数据收集Agent] + [趋势分析Agent] + [报告生成Agent]

  任务完成后，网络解散
```

### 实现思路

目前自适应网络主要通过"元 Agent"或"路由 Agent"实现——一个 Agent 负责分析任务，然后动态选择和组合其他 Agent：

```python
class AdaptiveAgentNetwork:
    def __init__(self, agent_registry):
        self.registry = agent_registry  # 可用的 Agent 池

    def execute(self, task):
        # 1. 分析任务，确定需要哪些能力
        analysis = self.analyze_task(task)

        # 2. 从 Agent 池中选择合适的 Agent
        selected_agents = self.select_agents(analysis.required_capabilities)

        # 3. 动态组建网络拓扑
        topology = self.build_topology(selected_agents, analysis.dependencies)

        # 4. 执行
        result = self.run_topology(topology, task)

        # 5. 解散网络
        return result

    def analyze_task(self, task):
        """分析任务需要什么能力"""
        return self.llm.invoke(
            f"分析这个任务需要哪些能力（搜索、编码、分析、写作等）：\n{task}"
        )

    def select_agents(self, capabilities):
        """根据能力需求选择 Agent"""
        selected = []
        for cap in capabilities:
            agent = self.registry.find_best(cap)
            if agent:
                selected.append(agent)
        return selected

    def build_topology(self, agents, dependencies):
        """根据依赖关系构建执行拓扑"""
        # 如果 Agent 之间有依赖 → 顺序执行
        # 如果互相独立 → 并行执行
        # 类似 LLMCompiler 的 DAG 思路
        return build_dag(agents, dependencies)
```

### AgentNet：动态演化的 Agent 网络

AgentNet（arxiv 2504.00587）是目前最有代表性的自适应网络实现。核心机制：

1. **Warm-Up（预热）**：正式任务前用标准化问题训练网络，初始化权重矩阵
2. **任务执行**：Router 分析任务，三种决策——Forward（转发）、Split（拆分）、Execute（自行执行）
3. **演化**：根据执行结果更新 Agent 间的信任权重，低权重连接被剪枝

基准数据（GPT-4o-mini）：

| 框架 | MATH | APPS (Pass@1) | BBH |
|------|------|---------------|-----|
| **AgentNet** | **85.00** | **70.59** | **86.00** |
| MetaGPT | 73.57 | — | 53.00 |
| 单 Agent (GPT-4o-mini) | ~72.00 | — | ~65.00 |

消融实验：Warm-Up 贡献最大（MATH +7.14, BBH +10），说明网络初始化质量对性能至关重要。

### 当前的局限

自适应 Agent 网络目前还是研究阶段，实际应用中的问题：

1. **元 Agent 的判断力**：如果元 Agent 选错了 Agent 组合，后续全错
2. **Agent 间的接口兼容**：动态组合的 Agent 需要统一的输入输出接口
3. **调试困难**：每次的拓扑可能不同，难以复现和调试
4. **成本不确定性**：不同任务可能触发不同数量的 Agent，成本难以预测

实用建议：**目前用固定拓扑 + 手动调整**。只有当任务类型确实不可预测（如通用助手），才考虑自适应。

## 延伸阅读

- [OpenAI Deep Research](https://openai.com/index/introducing-deep-research/) — OpenAI 的深度调研产品介绍
- [Perplexity Pro Search](https://www.perplexity.ai/) — 增强搜索产品
- [Tavily Research API](https://tavily.com/) — 开发者可用的 Deep Research API
- [Storm: Writing with OpenAI](https://storm.genie.stanford.edu/) — Stanford 的长文生成系统，详见[元认知章节](10-metacognition-self-discover-storm.md)
- [AutoGen: Multi-Agent Conversation](https://arxiv.org/abs/2308.08155) — 支持动态 Agent 组合的对话框架
- [Adaptive Multi-Agent Systems](https://arxiv.org/abs/2310.04...) — 自适应多 Agent 系统的研究综述
