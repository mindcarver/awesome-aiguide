# 自问与代码：Self-Ask 与 CodeAct

**TL;DR：** Self-Ask 让模型在回答复杂问题时先拆成子问题逐一回答，在 Bamboogle 数据集上把准确率从 CoT 的 46.4% 提升到 57.6%。CodeAct 用 Python 代码替代自然语言描述动作，在 M3ToolEval 上从 JSON 格式的 52.4% 提升到 74.4%。两个模式解决不同问题：Self-Ask 解决"问题太复杂一步答不准"，CodeAct 解决"自然语言描述动作不够精确"。

## 它解决什么失控点

### Self-Ask：复合问题的分解缺口

很多问题不是"不知道答案"，而是"问题里套着问题"。比如"特斯拉的创始人和亚马逊的创始人，谁更年长？"——模型需要先知道两位创始人的名字，再知道各自的出生年份，最后比较。CoT 会把整个推理写在一段话里，但如果中间某一步搞错了（比如记错了贝佐斯的出生年份），后面的推理全错。

Self-Ask 解决的是**复合问题的分解失控**：把一个大问题拆成一系列小问题，每个小问题独立回答，再组合成最终答案。

### CodeAct：动作描述的精确性缺口

ReAct 用自然语言描述动作，比如 `Action: search, Input: "特斯拉股价"`。问题在于自然语言有歧义——"搜索特斯拉股价"到底是要实时价格还是历史价格？返回格式是什么？如果需要做数值计算，自然语言描述更容易出错。

CodeAct 解决的是**动作描述的精确性失控**：用代码替代自然语言，Python 的语义是确定的，没有歧义。

## Self-Ask：先问自己，再回答你

Self-Ask 出自论文 *Measuring and Narrowing the Compositionality Gap in Language Models*（Press et al., 2022）。模式很简单：

```text
问题: 特斯拉的创始人和亚马逊的创始人，谁更年长？

Follow-up 1: 特斯拉的创始人是谁？
Intermediate answer: 马斯克（Elon Musk）

Follow-up 2: 亚马逊的创始人是谁？
Intermediate answer: 杰夫·贝佐斯（Jeff Bezos）

Follow-up 3: 马斯克的出生年份是？
Intermediate answer: 1971年

Follow-up 4: 贝佐斯的出生年份是？
Intermediate answer: 1964年

Final answer: 贝佐斯（1964年）比马斯克（1971年）更年长。
```

### 为什么有效

Self-Ask 的威力在于**强制分解**。模型不能跳过中间步骤直接猜答案——每个 Follow-up 都必须显式回答。这让错误更容易定位：如果模型答错了"特斯拉的创始人是谁"，不会污染后续推理，因为你可以接入搜索引擎来回答每个 Follow-up。

结合搜索引擎时效果更好——Self-Ask + 搜索在 Bamboogle 上达到 57.6%，而 CoT + 搜索只有 46.4%。因为 Self-Ask 的每个子问题都精确到可以直接搜索，而 CoT 的长推理链很难对应到具体搜索查询。

### 实现方式

```python
# Self-Ask 的 prompt 模板（简化版）
SELF_ASK_TEMPLATE = """
Question: {question}
Are follow up questions needed here: Yes.

Follow up: {sub_question_1}
Intermediate answer: {answer_1}

Follow up: {sub_question_2}
Intermediate answer: {answer_2}

Final answer: {final_answer}
"""

# LangChain 中的 Self-Ask 实现
from langchain.agents import create_self_ask_with_search_agent

agent = create_self_ask_with_search_agent(
    llm=ChatOpenAI(model="gpt-4o"),
    tools=[search_tool],
    verbose=True,
)

result = agent.invoke({
    "input": "特斯拉的创始人和亚马逊的创始人，谁更年长？"
})
```

Self-Ask 也可以和 Function Calling 结合：每个 Follow-up 映射为一个工具调用，Intermediate answer 就是工具返回结果。

### 适用场景

**适合**：需要多步事实查询的复合问题——"A 和 B 有什么关系"、"比较 X 和 Y 在 Z 方面的差异"。这类问题有一个清晰的子问题分解结构。

**不适合**：开放性创意任务或不需要查事实的推理任务。"写一首关于春天的诗"不需要 Self-Ask；"2+2 等于几"也不需要，因为问题本身足够简单，分解反而增加成本。

## CodeAct：用代码作为动作语言

CodeAct 出自论文 *Executable Code Actions Elicit Better LLM Code Agents*（Wang et al., 2024）。核心思想：与其让模型用自然语言描述"我要做什么"，不如让它直接写代码来执行。

### 自然语言 vs 代码

```text
ReAct（自然语言）:
  Thought: 我需要计算这两个数的平均值
  Action: calculator
  Action Input: "(248.5 + 312.8) / 2"

CodeAct（代码）:
  Action:
  ```python
  prices = [248.5, 312.8]
  avg_price = sum(prices) / len(prices)
  print(f"Average price: ${avg_price:.2f}")
  ```
  Observation: Average price: $280.65
```

代码的优势在于：

1. **精确性**：Python 的语法没有歧义。`(248.5 + 312.8) / 2` 只有一种解释。
2. **可组合性**：可以定义变量、写循环、处理异常——自然语言做不到。
3. **可验证性**：代码执行结果是确定的，不会出现"理解偏差"。
4. **复杂操作**：排序、过滤、数据转换这些操作，用代码几行搞定，自然语言需要啰嗦描述。

### UPAR 框架

CodeAct 论文提出了 UPAR（Understand-Plan-Act-Reflect）框架，把 CodeAct 融入一个完整的 Agent 循环：

```text
Understand（理解）：分析用户请求，提取关键信息
Plan（规划）：制定执行计划
Act（行动）：用代码执行具体操作
Reflect（反思）：检查执行结果，决定是否需要调整
```

关键数据：UPAR + CodeAct 在 GSM8K-Hard（高难度数学推理）上从纯 CoT 的 22.9% 提升到 58.3%。在 M3ToolEval（多工具评估）上从 JSON 格式动作的 52.4% 提升到 74.4%。

### 代码示例

```python
# CodeAct 的执行环境（简化版）
import subprocess
import json

def execute_code_action(code: str, context: dict) -> dict:
    """在沙箱中执行模型生成的代码"""
    # 将上下文变量注入执行环境
    setup_code = ""
    for key, value in context.items():
        setup_code += f"{key} = {repr(value)}\n"

    full_code = setup_code + "\n" + code

    try:
        result = subprocess.run(
            ["python3", "-c", full_code],
            capture_output=True, text=True,
            timeout=30,  # 超时保护
        )
        return {
            "stdout": result.stdout,
            "stderr": result.stderr,
            "returncode": result.returncode,
        }
    except subprocess.TimeoutExpired:
        return {"error": "执行超时（30秒）"}
```

### 安全考量

CodeAct 直接执行模型生成的代码，安全是第一优先级：

1. **沙箱隔离**：代码在容器或沙箱中运行，不能访问宿主文件系统、网络（除白名单外）或敏感 API
2. **资源限制**：CPU 时间、内存、文件描述符都设上限
3. **权限最小化**：只导入必要的标准库，禁止 `os.system`、`subprocess` 等危险调用
4. **人工审核**：对涉及写操作（删除、修改、发送）的代码，弹出确认

```python
# 安全的代码执行环境
import ast

UNSAFE_MODULES = {"os", "subprocess", "shutil", "signal", "socket"}
UNSAFE_BUILTINS = {"exec", "eval", "compile", "__import__", "open"}

def check_code_safety(code: str) -> bool:
    """静态检查代码安全性"""
    tree = ast.parse(code)
    for node in ast.walk(tree):
        if isinstance(node, ast.Import):
            if node.module in UNSAFE_MODULES:
                return False
        if isinstance(node, ast.Call):
            if isinstance(node.func, ast.Name):
                if node.func.id in UNSAFE_BUILTINS:
                    return False
    return True
```

## 两个模式的对比

| 维度 | Self-Ask | CodeAct |
|------|----------|---------|
| 解决什么 | 复合问题的分解 | 动作描述的精确性 |
| 核心操作 | 拆子问题 → 逐个回答 | 写代码 → 执行 → 看结果 |
| 典型场景 | 多步事实查询 | 数据处理、计算、自动化 |
| 输出格式 | 自然语言问答 | Python 代码 |
| 额外成本 | 每个子问题一次 LLM 调用 | 代码执行环境 + LLM 调用 |
| 安全风险 | 低（只做文本推理） | 高（执行代码需要沙箱） |
| 可以组合 | Self-Ask + 搜索引擎 | CodeAct + UPAR 反思循环 |

## 工程考量

### Self-Ask 的停止条件

Self-Ask 需要判断"还需要继续追问吗"。简单的规则：当所有 Follow-up 的答案都已获得，且足以回答原始问题时停止。实现上，让模型在生成 Follow-up 时同时判断是否可以给出最终答案。

### CodeAct 的代码质量

模型生成的代码不一定能跑。常见问题：变量名拼错、忘记 import、类型不匹配。需要：

1. **执行反馈**：把报错信息返回给模型，让它修复
2. **重试限制**：最多重试 3 次，超过后降级为自然语言动作
3. **代码审查**：对关键操作（数据库写入、API 调用）做静态检查

### 何时选择哪个

- **需要查事实的多步推理** → Self-Ask（特别是能接入搜索引擎时）
- **需要做计算或数据操作** → CodeAct（代码比自然语言精确得多）
- **两者都不需要** → 普通 CoT 或 ReAct 就够了

实际上两个模式可以组合：用 Self-Ask 拆解问题，对需要计算的子问题用 CodeAct 执行。但组合的复杂度要谨慎——每加一层抽象，调试就更难。

## 延伸阅读

- [Self-Ask 原始论文](https://arxiv.org/abs/2212.10560) — Press et al., 2022，Bamboogle 和 BBH 基准数据
- [CodeAct 原始论文](https://arxiv.org/abs/2401.03168) — Wang et al., 2024，M3ToolEval 和 GSM8K-Hard 基准
- [UPAR: Understand-Plan-Act-Reflect](https://arxiv.org/abs/2310.12345) — CodeAct 的完整 Agent 框架
- [ReAct: Reasoning + Acting](https://arxiv.org/abs/2210.03629) — CodeAct 的基础，用自然语言描述动作
- [Program-Aided Language Models (PAL)](https://arxiv.org/abs/2211.10435) — 类似思路，用代码辅助推理
