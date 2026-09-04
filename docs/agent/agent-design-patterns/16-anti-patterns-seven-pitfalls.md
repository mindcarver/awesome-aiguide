# 反模式：智能体设计的七个坑

**TL;DR：** 设计模式教你怎么做对，反模式教你怎么避开错。这七个反模式覆盖了 Agent 项目从设计到上线的常见失败：God Agent（一个 Agent 干所有事）、无限循环（Agent 反复重试同一个失败操作）、工具爆炸（给 Agent 挂了太多工具）、上下文溢出（信息撑爆窗口）、多 Agent 级联崩溃（一个挂全挂）、幻觉工具调用（编造不存在的工具）、过早抽象（还没跑起来就开始拆微服务）。LangChain 的基准测试显示，Agent 超过 20 个工具时性能急剧下降；多 Agent 系统的失败率在 41%-87% 之间。认识这些坑，比学更多设计模式更重要。

## 为什么需要反模式

设计模式告诉你"应该怎么做"，反模式告诉你"千万不能这么做"。在 Agent 项目中，反模式的价值可能更大——因为 Agent 系统的失败往往不是"选错了模式"，而是"掉进了坑里"。

这些反模式来自公开的基准数据、框架团队的工程博客和 arXiv 论文。每一个都有具体的失败数据支撑。

## 反模式 1：God Agent（万能 Agent）

### 症状

一个 Agent 被赋予了所有能力：搜索、编码、数据分析、客服、调度、审批...工具列表有 50+ 个，系统 prompt 写了 5000 字，什么都能做但什么都不精。

### 为什么是坑

LLM 的工具选择准确率随工具数量增长而下降。LangChain 的基准测试显示：

```text
工具数量    任务完成率
1-5        ~90%
10         ~80%
20         ~65%
50+        ~40%
```

工具越多，LLM 越容易选错工具或传入错误参数。5000 字的系统 prompt 也让模型难以聚焦——大量不相关的指令互相干扰。

### 解法

拆分职责。按[协作章节](13-swarm-handoff-debate.md)的 Swarm 模式或[组合章节](14-agents-as-tools-context-engineering.md)的 Agents-as-Tools 模式，把不同能力分配给不同的专家 Agent。每个 Agent 的工具控制在 5-10 个以内。

```python
# 坏：God Agent
god_agent = Agent(
    tools=[search, code, db, email, calendar, slack, jira, ...50个],
    instructions="你是万能助手，什么都能做...",
)

# 好：分工明确的专家
research_agent = Agent(tools=[search, scrape], instructions="专注调研")
coding_agent = Agent(tools=[execute_code, read_file], instructions="专注编码")
```

### 什么时候会让你中招

项目初期最容易掉进这个坑——"先用一个 Agent 把功能跑通"。功能跑通后不舍得拆，越加越多，直到质量不可控。

## 反模式 2：无限循环

### 症状

Agent 反复执行同一个失败操作，不改变策略，消耗大量 Token 直到触发 recursion_limit。

### 为什么是坑

ReAct 循环没有内置的"换个方向"机制。如果工具返回错误，模型可能认为"参数不对，再试一次"——用相同的参数。一个典型的无限循环：

```text
Thought: 调用 search 工具
Action: search("特斯拉股价")
Observation: Error: API rate limit exceeded

Thought: 重试
Action: search("特斯拉股价")
Observation: Error: API rate limit exceeded

Thought: 再试一次
Action: search("特斯拉股价")
...（重复直到 recursion_limit）
```

LangChain 的研究发现，**90.8% 的 Agent 重试是在浪费 Token**——它们重试的是不可能成功的错误（如 API 限流、参数格式错误）。

### 解法

1. **错误分类**：区分可重试错误（网络超时）和不可重试错误（参数错误、权限拒绝）
2. **策略切换**：连续失败 N 次后，强制切换工具或策略
3. **退避机制**：工具调用失败后，等待或换用替代工具

```python
class SmartRetry:
    def __init__(self, max_same_action_retries=2):
        self.attempts = {}
        self.max_retries = max_same_action_retries

    def should_retry(self, action, observation):
        key = f"{action.tool}:{action.input}"
        if "rate limit" in observation.lower():
            return False  # 不可重试
        if "timeout" in observation.lower():
            self.attempts[key] = self.attempts.get(key, 0) + 1
            return self.attempts[key] <= self.max_retries
        return False  # 其他错误不重试

    def suggest_alternative(self, action):
        """建议替代策略"""
        if action.tool == "search":
            return "search_with_different_query"
        return "ask_user_for_clarification"
```

## 反模式 3：工具爆炸（Over-Tooling）

### 症状

给 Agent 配了大量工具，"以防万一"需要。每个 API endpoint 都包装成一个工具，工具之间功能重叠。

### 为什么是坑

每个工具的定义（name + description + parameters）都占用上下文窗口。50 个工具的定义大约需要 5,000-10,000 tokens——这还没开始执行任务，就已经消耗了 5-8% 的上下文窗口。

更严重的是**选择干扰**：功能重叠的工具让模型无法区分。比如同时有 `search_web`、`search_news`、`search_academic` 三个工具，模型经常选错。

### 解法

1. **工具精简**：定期审查工具使用日志，删除从未被调用的工具
2. **合并重叠**：把 `search_web`、`search_news`、`search_academic` 合并为 `search(type="web|news|academic")`
3. **懒加载**：不把所有工具定义放在上下文中，而是按需加载。Agent 先判断需要哪类工具，再加载对应的工具子集

```python
# 工具分组懒加载
TOOL_GROUPS = {
    "search": [web_search, academic_search, news_search],
    "data": [query_db, read_csv, execute_python],
    "communication": [send_email, post_slack, create_ticket],
}

def get_relevant_tools(user_query):
    category = classifier.invoke(f"这个查询需要哪类工具：{user_query}")
    return TOOL_GROUPS.get(category, TOOL_GROUPS["search"])
```

## 反模式 4：上下文溢出

### 症状

Agent 执行多步任务时，上下文窗口被填满，模型开始"遗忘"早期信息，输出质量急剧下降。

### 为什么是坑

LLM 的信息利用效率在长上下文中不是均匀的——"Lost in the Middle"研究发现，模型对上下文开头和结尾的信息利用率高，中间的信息容易被忽略。10 步的 ReAct 循环中，第 3-7 步的观察结果最容易被遗忘。

### 解法

Context Engineering（详见[组合与上下文章节](14-agents-as-tools-context-engineering.md)）的核心实践：

1. **压缩历史**：超过 N 步后，把早期步骤压缩为摘要
2. **关键信息前置**：把最重要的信息放在上下文开头或结尾
3. **按需检索**：不把所有信息都塞进上下文，而是需要时才检索

```python
# 上下文预算管理
class ContextBudget:
    def __init__(self, total=128000):
        self.budget = {
            "system_prompt": 3000,
            "tool_definitions": 5000,
            "conversation": 40000,
            "retrieval": 20000,
            "execution_results": 10000,
            "output_reserve": 4000,
            "safety_margin": 46000,
        }
```

## 反模式 5：多 Agent 级联崩溃

### 症状

多 Agent 系统中，一个 Agent 的错误被后续 Agent 放大，最终整个系统产生灾难性输出。

### 为什么是坑

arXiv 论文 *Why Do Multi-Agent LLM Systems Fail?*（2025）对 5 个多 Agent 框架的系统研究发现：**41%-87% 的多 Agent 执行轨迹包含至少一个失败模式**。而且，多 Agent 系统的失败经常是级联的：

```text
Agent A: [幻觉了一个不存在的 API 参数]
  → Agent B: [基于 A 的幻觉结果继续推理]
    → Agent C: [把 B 的错误推理当作事实输出]
      → 最终输出：完全错误但看起来很自信
```

论文识别了 14 种失败模式，分布在 3 个类别中：

| 类别 | 失败模式 | 占比 |
|------|---------|------|
| 规范与系统设计 | 角色定义不清、终止条件缺失 | ~35% |
| Agent 间不对齐 | 信息丢失、幻觉传播、职责重叠 | ~40% |
| 任务验证与终止 | 过早终止、无法验证结果 | ~25% |

### 解法

1. **独立验证**：每个 Agent 的输出在传递给下一个 Agent 之前，经过独立验证
2. **置信度传播**：Agent 在输出中标注置信度，后续 Agent 根据置信度加权使用
3. **断路器**：当检测到级联错误时，立即中断并回退到人工干预

```python
# 简单的级联保护
def agent_pipeline(agents, input):
    result = input
    confidence = 1.0

    for agent in agents:
        result = agent.invoke(result)
        confidence *= result.confidence

        if confidence < 0.3:
            return {
                "error": "级联置信度过低，终止执行",
                "partial_result": result,
                "confidence": confidence,
            }

    return {"result": result, "confidence": confidence}
```

## 反模式 6：幻觉工具调用

### 症状

模型调用不存在的工具，或者传入完全不合理的参数。这不是"选错工具"——而是编造工具。

### 为什么是坑

LLM 有时会"幻觉"出工具名。特别是在系统 prompt 中工具列表很长时，模型可能混淆工具名，编造一个看起来合理但实际不存在的工具。

```text
Agent: Action: search_stock_price("TSLA")
系统: 错误 - 工具 "search_stock_price" 不存在
Agent: Action: lookup_stock("TSLA")
系统: 错误 - 工具 "lookup_stock" 不存在
Agent: 好吧，特斯拉当前股价约为 $250（直接幻觉）
```

### 解法

1. **Function Calling**：使用结构化的工具调用 API（而非文本解析），模型只能从定义好的工具列表中选择
2. **严格校验**：即使使用 Function Calling，也要校验参数类型和范围
3. **工具名规范**：使用清晰、无歧义的工具名，避免相似名称

```python
# 工具调用校验
def validate_tool_call(tool_call, available_tools):
    tool = next((t for t in available_tools if t.name == tool_call.name), None)
    if not tool:
        return False, f"工具 '{tool_call.name}' 不存在"

    for param in tool.parameters:
        if param.required and param.name not in tool_call.arguments:
            return False, f"缺少必要参数 '{param.name}'"

    return True, "OK"
```

## 反模式 7：过早抽象

### 症状

还没让单个 Agent 跑起来，就开始设计多 Agent 编排系统、微服务架构、复杂的通信协议。

### 为什么是坑

Anthropic 的工程建议很明确：**从最简单的方案开始**。能用 Prompt Chaining 解决的，不要用 ReAct；能用单个 Agent 解决的，不要用多 Agent。过早引入复杂架构会导致：

- 调试困难——错误可能出在任何一个 Agent 或通信环节
- 迭代变慢——改一个功能要改多个 Agent 的 prompt
- 成本失控——每个 Agent 都要调一次 LLM

### 解法

遵循 Anthropic 的 Agent 迭代原则：

```text
第 1 步：用单个 prompt 能解决吗？→ 能 → 不需要 Agent
第 2 步：用工作流（chaining/routing）能解决吗？→ 能 → 不需要 Agent
第 3 步：用单个 Agent + 工具能解决吗？→ 能 → 不需要多 Agent
第 4 步：确定需要多 Agent → 先用最简单的编排，逐步增加复杂度
```

每一步都要有明确的理由才升级。不要"因为多 Agent 看起来更先进"就用多 Agent。

## 反模式速查表

| 反模式 | 核心问题 | 信号 | 解法 |
|--------|---------|------|------|
| God Agent | 一个 Agent 干所有事 | 工具 >20，prompt >3000 字 | 拆分专家 Agent |
| 无限循环 | 反复重试失败操作 | 同一 action 连续出现 3+ 次 | 错误分类 + 策略切换 |
| 工具爆炸 | 工具太多选不准 | 工具利用率 <30% | 精简 + 合并 + 懒加载 |
| 上下文溢出 | 窗口塞满，信息丢失 | 多步任务后期质量下降 | 压缩 + 按需检索 |
| 级联崩溃 | 一个错，全盘错 | 多 Agent 输出逐步偏移 | 独立验证 + 断路器 |
| 幻觉工具调用 | 编造不存在的工具 | "工具 xxx 不存在"错误 | Function Calling + 校验 |
| 过早抽象 | 还没跑就先拆 | 还没有用户就开始设计架构 | 从简单开始，逐步升级 |

## 延伸阅读

- [Why Do Multi-Agent LLM Systems Fail?](https://arxiv.org/abs/2503.13657) — 14 种多 Agent 失败模式的系统研究
- [Building Effective Agents - Anthropic](https://www.anthropic.com/engineering/building-effective-agents) — "从简单开始"的工程原则
- [LangChain Agent Benchmarking](https://www.langchain.com/blog/react-agent-benchmarking) — 工具数量与 Agent 性能的基准数据
- [Lost in the Middle](https://arxiv.org/abs/2307.03172) — 长上下文中信息利用效率的研究
- [Your ReAct Agent Is Wasting 90% of Its Retries](https://towardsdatascience.com/your-react-agent-is-wasting-90-of-its-retries-heres-how-to-stop-it/) — 无效重试的分析和解决
