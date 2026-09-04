# 后训练、偏好对齐与 LoRA：面试里怎么讲 SFT、RLHF、DPO、PPO

资料更新：2026-06-30。

这篇是面向 AI / Agent 面试的模型层补充。现有文章已经讲了训练全景和 SFT 数据构造；这篇专门补上面试高频追问：RLHF、DPO、PPO、LoRA、QLoRA 之间是什么关系，Agent 场景里为什么还会提到它们。

## 先给结论

| 方法 | 解决什么问题 | 面试里怎么一句话讲清 |
|------|--------------|----------------------|
| SFT | 学会任务格式和示范行为 | 用高质量示范数据教模型“应该怎么答” |
| RLHF | 按人类偏好优化回答策略 | 用人类偏好训练奖励模型，再用强化学习优化模型 |
| PPO | RLHF 里常用的策略优化算法 | 在不让模型偏离太远的前提下，沿奖励方向更新策略 |
| DPO | 更简单的偏好优化 | 不显式训练奖励模型，直接用偏好对优化“选好不选坏” |
| LoRA | 参数高效微调 | 冻结大模型，只训练小的低秩增量矩阵 |
| QLoRA | 低显存 LoRA | 把基座模型量化后再做 LoRA，降低显存门槛 |

面试时不要把这些术语背成并列名词。更好的讲法是：

```text
SFT 先教模型做任务，偏好优化再教模型在多个可行答案里选更符合目标的行为。
LoRA / QLoRA 不是新的训练目标，而是降低微调成本的参数高效方法。
```

## SFT 和偏好对齐不是一回事

SFT 的输入是示范样本：

```text
prompt -> ideal answer
```

它更像“模仿学习”。模型看到很多标准答案后，学会类似的输出格式、语气、步骤和任务边界。

偏好对齐的输入是比较样本：

```text
prompt -> answer A better than answer B
```

它更像“选择训练”。模型不只是模仿某个答案，而是学习什么样的答案更受偏好函数欢迎。

这就是为什么很多模型路线是：

```text
pretrain -> SFT -> preference optimization -> evaluation -> deployment
```

SFT 解决“会不会按指令做”。偏好优化解决“多个可行回答里，哪个更好”。

## RLHF：三阶段流程

RLHF 通常包含三步：

1. **SFT model**：先用示范数据训练一个能正常回答的模型。
2. **Reward model**：收集同一 prompt 下多个回答的人类排序，训练奖励模型。
3. **RL optimization**：用 PPO 等算法，让模型输出能拿到更高 reward 的答案。

面试里要讲清楚一个关键点：RLHF 不是直接让人类给每个 token 打分，而是先把人类偏好压缩成 reward model，再用它批量指导模型优化。

常见追问：

**为什么不只做 SFT？**

因为 SFT 只能模仿示范答案。很多场景没有唯一标准答案，比如“更有帮助”“更安全”“更简洁”“更符合品牌语气”。这些更适合用偏好比较表达。

**RLHF 的问题是什么？**

- 人类偏好数据贵。
- reward model 可能被模型投机利用。
- PPO 训练复杂，稳定性和超参数敏感。
- 对齐可能牺牲部分直接性或多样性。

## PPO：为什么它会出现在大模型对齐里

PPO 是一种策略优化算法。放到语言模型里，可以把模型看成一个策略：

```text
state = prompt + 已生成 token
action = 下一个 token
reward = reward model 对完整回答的打分
```

PPO 的目标是提高 reward，但又不能让新模型离原模型太远。否则模型可能为了刷 reward 产生奇怪行为。

所以 RLHF 里通常会加 KL 约束：

```text
既要更符合偏好，也不要偏离原始模型太多。
```

面试时不需要推 PPO 公式，但要讲清这个工程直觉：PPO 不是“随便强化学习”，而是在 reward 提升和模型稳定之间做折中。

## DPO：为什么它比 RLHF 更容易落地

DPO（Direct Preference Optimization）直接使用偏好对训练：

```text
chosen answer > rejected answer
```

它不需要显式训练 reward model，也不需要跑复杂的 PPO loop。工程上更简洁，所以在很多团队里更容易落地。

你可以这样讲：

```text
DPO 把偏好优化变成一个监督学习式目标：提高 chosen 的概率，降低 rejected 的概率，同时约束模型不要偏离参考模型太远。
```

适合 DPO 的场景：

- 已经有偏好对数据。
- 想优化风格、简洁性、安全性、任务完成质量。
- 不想维护 reward model 和 PPO 训练流程。

不适合把 DPO 神化。DPO 仍然依赖高质量偏好数据，偏好数据错了，模型也会学错。

## LoRA：它解决的是训练成本，不是训练目标

LoRA 的核心思想是：不要更新大模型全部参数，只在部分线性层旁边加低秩矩阵。

原始权重冻结：

```text
W 不动
```

训练一个小增量：

```text
W + A * B
```

其中 A 和 B 的秩很低，所以可训练参数量大幅下降。

面试里常见追问：

**rank 怎么选？**

- rank 越大，表达能力越强，显存和过拟合风险也更高。
- 小任务、小数据、格式类任务可以低一些。
- 复杂风格迁移或领域行为可以适当提高。
- 最终要靠验证集，而不是凭感觉。

**alpha 是什么？**

alpha 控制 LoRA 增量的缩放强度。太小效果不明显，太大可能破坏基座模型原有能力。

**target modules 怎么选？**

通常会从 attention 和 MLP 的线性层开始。不同模型命名不同，不能照抄参数名。面试里更重要的是讲清楚：你改的是哪些投影层，以及为什么只训练这些增量参数。

## QLoRA：显存受限时的微调路线

QLoRA 把基座模型量化到低精度，再在量化模型上训练 LoRA 增量。它的核心价值是降低显存门槛，让更大的模型能在较小资源上做微调。

面试回答要点：

- QLoRA 不是让模型更强，而是让微调更省。
- 量化会带来近似误差，所以要看任务指标。
- 训练时通常仍保持 LoRA 增量为可训练高精度参数。
- 适合资源有限但需要定制行为的团队。

## Agent 场景里为什么会问 SFT / RL

Agent 面试里问训练，不是为了考你会不会训 ChatGPT，而是看你是否理解“Agent 能力从哪里来”。

| Agent 问题 | 更可能的手段 |
|------------|--------------|
| 工具调用 JSON 格式不稳定 | SFT、结构化输出、schema 约束 |
| 总是选错工具 | 工具描述优化、候选工具裁剪、SFT 工具轨迹 |
| 多步任务成功率低 | trajectory 数据、偏好优化、RL、workflow 约束 |
| 回答太啰嗦或不安全 | 偏好数据、DPO/RLHF、输出审查 |
| 不知道企业知识 | RAG，不是 SFT 优先 |
| 工具越权 | 权限系统，不是训练优先 |

一个成熟回答应该承认：很多 Agent 问题不是训练能单独解决的。工具权限、状态管理、评测、重试和 human-in-the-loop 往往比微调更直接。

## 面试高频问答

**Q1：SFT 和 DPO 有什么区别？**

SFT 学示范答案，DPO 学偏好排序。SFT 让模型知道“应该怎么做”，DPO 让模型在多个可行答案中更倾向“更好的那个”。

**Q2：RLHF 为什么复杂？**

因为它要收集偏好数据、训练 reward model、再用 PPO 等强化学习方法优化模型。每一步都有数据质量、训练稳定性和 reward hacking 风险。

**Q3：为什么 DPO 可以不用 reward model？**

DPO 直接从偏好对里构造优化目标，提高 chosen answer 的相对概率，降低 rejected answer 的相对概率。它把偏好优化简化成更接近监督训练的流程。

**Q4：LoRA 会不会改变模型全部能力？**

理论上只训练低秩增量，但它仍会影响模型输出分布。数据太窄、rank 太高、训练太久，都可能让模型过拟合或损伤通用能力。

**Q5：微调能替代 RAG 吗？**

通常不能。RAG 解决可更新、可溯源、企业私有知识接入；微调更适合稳定行为、格式、风格和固定任务。把变化快的知识写进参数，更新成本高且不可追溯。

## 复习路线

1. 先读 [训练全景与模型进化路线](training-landscape-and-model-evolution.md)，建立分层判断。
2. 再读 [SFT 与训练数据构造](sft-and-training-data-construction.md)，理解示范数据和任务定义。
3. 最后读本文，补齐偏好优化和参数高效微调。

如果只准备应用岗，能讲清“什么时候不用微调”比会背 PPO 公式更重要。

如果准备算法岗，至少要能把 SFT、RLHF、DPO、PPO、LoRA、QLoRA 的关系讲成一条训练链路。

## 延伸阅读

- [Training language models to follow instructions with human feedback](https://arxiv.org/abs/2203.02155)
- [Direct Preference Optimization](https://arxiv.org/abs/2305.18290)
- [Proximal Policy Optimization Algorithms](https://arxiv.org/abs/1707.06347)
- [LoRA: Low-Rank Adaptation of Large Language Models](https://arxiv.org/abs/2106.09685)
- [QLoRA: Efficient Finetuning of Quantized LLMs](https://arxiv.org/abs/2305.14314)
