<!--
调研来源：
1. Scikit-learn 官方文档 "Cross-validation: evaluating estimator performance" — 系统介绍了 K-Fold、Stratified K-Fold、Group K-Fold、Time Series Split 等交叉验证策略
2. Kaggle "Data Leakage" 课程 (alexisbcook) — 将数据泄露分为 Target Leakage 和 Train-Test Contamination 两大类，配以实战案例
3. Yale News (2024) "Data 'leaks' can sink machine learning models" — 研究发现特征选择泄露和预处理泄露会严重夸大模型性能
4. Machine Learning Mastery "Data Preparation Without Data Leakage" — 详解了为什么预处理必须在 CV 循环内部完成
5. Towards Data Science "Seven Common Causes of Data Leakage in Machine Learning" — 归纳了缩放、编码、插值、特征选择等 7 种常见泄露场景

核心发现：
- 数据泄露是机器学习项目失败的首要原因之一，Kaggle 竞赛中大量高分方案因泄露而无效
- 最隐蔽的泄露发生在预处理阶段：在全数据上做标准化/插值/特征选择再 split，会让测试集信息泄露到训练过程中
- 正确的做法是使用 Pipeline 把预处理封装进交叉验证循环，确保每个 fold 的预处理只依赖该 fold 的训练数据
-->

# 交叉验证与数据泄露：为什么 train/test split 不够，以及那些你踩过但没意识到的坑

**TL;DR：** 简单的 train/test split 只给你一次评估机会，结果高度依赖那次随机划分，你可能走运也可能倒霉。交叉验证通过多次划分来消除这种随机性，但它引入了一个更危险的问题：数据泄露——当你不小心让测试数据的信息"泄漏"到训练过程中时，你的评估结果就是假的，部署后模型会翻车。本文系统讲解各种交叉验证策略和 7 种常见的数据泄露模式。

## 为什么这很重要

你训练了一个信用卡欺诈检测模型。你用 `train_test_split` 随机分了 80% 训练、20% 测试，测试集上 AUC 达到 0.97。你高兴地部署上线，结果实际运行时模型表现惨不忍睹。

可能的原因有很多，但最常见、也最容易被忽略的一个是：**你的评估是假的。** 不是说代码有 bug，而是你的评估流程让模型在"考试"前偷偷看到了答案。

这种事情比你想象的更常见。2024 年耶鲁大学的一项研究发现，在已发表的机器学习论文中，数据泄露导致模型性能被严重夸大的情况屡见不鲜。Kaggle 竞赛上也有大量高分方案因为数据泄露被取消成绩。

更根本的问题是：单次 train/test split 本身就不够可靠。假设你有 1000 条数据，随机取 200 条做测试。这 200 条恰好都是比较"容易"的样本怎么办？或者恰好包含几个极端异常值怎么办？你得到的评估结果会有很大的随机性。

交叉验证（Cross-Validation）就是来解决这两个问题的：消除单次划分的随机性，同时（如果你用对了的话）防止数据泄露。

## 核心概念

### 用一个类比来理解

想象你要评价一个学生的数学水平。

**Train/Test Split（单次考试）**：你出一张有 20 道题的卷子，让学生做其中 16 道（训练），然后用剩下 4 道题的得分来评价他的水平。问题是：这 4 道题可能恰好都是他擅长的类型，或者恰好都是他不会的。一次考试的结果可能不准确。

**K-Fold 交叉验证（多轮考试）**：你出了 20 道题，把它们分成 5 组（每 4 道一组）。你让学生做 5 轮考试，每轮用不同的 4 道题当考题，其余 16 道题当练习题。最后把 5 轮的得分平均，得到一个更可靠的评价。

**数据泄露（作弊）**：在每轮考试前，你让学生看了一眼考题的答案提示（比如在做标准化时用了所有数据的统计量），然后声称他考试得了高分。这个分数不能反映真实水平。

### 交叉验证的本质

交叉验证的核心思想很简单：**不止评估一次，评估多次，取平均。**

具体来说：

1. 把数据分成 K 份（"fold"）
2. 对于每一份：用这一份做验证集，其余 K-1 份做训练集
3. 训练模型，在验证集上计算指标
4. K 次评估结果的平均值就是你的最终评估

```
5-Fold 交叉验证示意图：

Fold 1: [验证][训练][训练][训练][训练]  → 得分 1
Fold 2: [训练][验证][训练][训练][训练]  → 得分 2
Fold 3: [训练][训练][验证][训练][训练]  → 得分 3
Fold 4: [训练][训练][训练][验证][训练]  → 得分 4
Fold 5: [训练][训练][训练][训练][验证]  → 得分 5

最终得分 = (得分1 + 得分2 + 得分3 + 得分4 + 得分5) / 5
```

为什么这样做更好？因为它让**每一条数据都有一次机会被当作验证数据**，而不是只靠一次随机划分来决定你的评估结果。

### 数据泄露的本质

数据泄露是指：**在训练过程中，模型间接或直接地获得了它不应该看到的信息。** 这些信息来自验证集或测试集，导致评估结果过于乐观。

数据泄露有两种主要类型：

**Target Leakage（目标泄露）**：你的特征里包含了和目标变量高度相关的信息，但这些信息在实际预测时是不可用的。比如，你用"是否开了抗感染药"来预测"是否感染"，但现实中只有感染了的病人才会开抗感染药。模型在训练时看到了"答案的影子"。

**Train-Test Contamination（训练-测试污染）**：你在预处理数据时，不小心让测试集的信息泄露到了训练集中。比如，你在 split 之前对全量数据做了标准化——标准化用的均值和方差包含了测试集的信息。

第二种泄露更隐蔽，更常见，也更危险，因为它发生得非常"自然"——你只是想做标准化而已，怎么会想到这也是泄露？

## 工作原理（简化的心智模型）

### 交叉验证的心智模型

把交叉验证想象成一个面试流程。

**单次面试（Train/Test Split）**：
- 你让候选人和一个面试官聊了 1 小时
- 这个面试官可能恰好问了候选人擅长的问题
- 你根据这一次面试决定是否录用——风险很高

**多轮面试（K-Fold CV）**：
- 你安排了 5 轮面试，每轮由不同的面试官主持
- 每个面试官关注候选人不同方面的能力
- 你综合 5 轮的反馈做出决定——更可靠

关键指标：
- **平均得分**：5 轮面试的平均评价——对应交叉验证的平均性能
- **得分的标准差**：5 轮评价之间的差异——如果某轮特别好、某轮特别差，说明候选人的能力不稳定（对应模型在不同数据上的表现不一致）

### 数据泄露的心智模型

数据泄露就像一个学生考试前做了以下事情：

1. **偷看了考试范围**（Target Leakage）：考试要考"二次函数"，学生提前知道了，于是只复习二次函数。考试成绩很高，但实际能力并没有那么强。

2. **偷看了同学的答案**（Train-Test Contamination）：考试时偷看了旁边同学（测试集）的答案，把自己的答案（训练集的预测）改得更接近。成绩虚高。

3. **提前知道了考试题的统计数据**（预处理泄露）：老师考前说"这次考试平均分 75，标准差 10"。学生根据这个信息调整了自己的答题策略。看似没有直接看题目，但实际上利用了考试的信息。

第 3 种情况最微妙——你没有直接看答案，但你利用了包含答案信息的统计量。这就是在全数据上做标准化时发生的事情。

## 工作原理（详细机制）

### K-Fold 交叉验证

K-Fold 是最基础的交叉验证策略。

**算法步骤**：
1. 将 n 个样本随机分成 K 个大小相近的 fold
2. 对于 i = 1, 2, ..., K：
   - 用第 i 个 fold 做验证集，其余 fold 做训练集
   - 在训练集上拟合模型（包括预处理）
   - 在验证集上计算评估指标 $s_i$
3. 最终评估：$\bar{s} = \frac{1}{K} \sum_{i=1}^{K} s_i$
4. 评估的可靠性：$\text{SE}(\bar{s}) = \frac{\text{std}(s_1, ..., s_K)}{\sqrt{K}}$

**K 的选择**：
- K = 5 或 K = 10 是最常用的。经验研究和理论分析都表明，K=5 或 K=10 在偏差和方差之间取得了较好的平衡
- K = n（Leave-One-Out，LOO）：每次只留一个样本做验证。偏差最低（每次用 n-1 个样本训练，和用全部数据训练的效果接近），但方差最高（n 次评估的结果高度相关），而且计算代价大
- K = 2：一次只分两份。方差低但偏差高（只用一半数据训练）

**一个常见的误解**：K 越大越好。实际上，LOO（K=n）在很多时候反而不如 K=5 或 K=10，因为 LOO 的 n 次评估之间高度相关（每次只差一个训练样本），导致平均值的方差很大。Bengio 和 Grandvalet 在 2004 年的论文中证明了 LOO 没有通用的方差估计器。

### Stratified K-Fold

当目标变量的类别分布不均衡时，普通的 K-Fold 可能会导致某些 fold 里正样本特别多或特别少。

**Stratified K-Fold** 确保每个 fold 中各类别的比例和完整数据集中的比例相同。

举个例子：假设你有 1000 个样本，其中 900 个负样本、100 个正样本（90:10 的比例）。

普通 K-Fold（K=5）：每个 fold 大约 200 个样本。但你可能遇到某个 fold 里只有 5 个正样本（2.5%），而另一个 fold 里有 30 个正样本（15%）。这会导致不同 fold 的评估结果差异巨大。

Stratified K-Fold（K=5）：每个 fold 都有大约 180 个负样本和 20 个正样本（维持 90:10 比例）。评估结果稳定得多。

**什么时候必须用 Stratified**：
- 类别不平衡时（正样本 < 20%）
- 多分类问题
- 小数据集（几百个样本以下）

**什么时候无所谓**：
- 大数据集（几万样本以上），普通 K-Fold 通常也能维持接近的比例
- 回归问题（但可以用类似的策略确保目标变量的分布在每个 fold 中相似）

### Group K-Fold

如果你的数据中有自然的分组（比如同一个患者有多条记录，同一用户有多次行为），你需要确保同一个 group 的所有样本都在同一个 fold 里。

为什么？假设你预测患者是否患某种疾病，每个患者有 5-10 条检查记录。如果你用普通 K-Fold，同一个患者的记录可能同时出现在训练集和测试集里。模型可以学到"这个患者独有的特征"，而这些特征对新患者完全没用。

**Group K-Fold** 确保同一个 group 的所有样本要么全在训练集，要么全在测试集。

```
Group K-Fold 示例（每个字母代表一个患者）：

Fold 1: [A的所有记录][B的所有记录]  ← 验证集（2个患者）
         [C的所有记录][D的所有记录][E的所有记录]...  ← 训练集

Fold 2: [C的所有记录][D的所有记录]  ← 验证集
         [A的所有记录][B的所有记录][E的所有记录]...  ← 训练集
```

**什么时候必须用 Group K-Fold**：
- 医疗数据（同一患者多次就诊）
- 用户行为数据（同一用户多次交互）
- 图像数据（同一场景拍的多张照片）
- 文本数据（同一作者写的多篇文章）

简而言之：当你关心的是模型在**新 group**上的泛化能力，而不是在同一 group 的新样本上时，必须用 Group K-Fold。

### Time Series Split

时间序列数据是最需要特殊处理的。时间序列有一个核心特点：**你不能用未来的数据预测过去。** 但普通的 K-Fold 会恰恰这样做——它可能把 2024 年的数据放在训练集里，用来"预测" 2023 年的数据。

**Time Series Split（Walk-Forward Validation）** 的原则是：训练集总是在验证集之前。

```
Time Series Split（5 折）示意图（按时间排列的数据）：

Fold 1: [训练] [验证] [未使用] [未使用] [未使用]
Fold 2: [训练] [训练] [验证] [未使用] [未使用]
Fold 3: [训练] [训练] [训练] [验证] [未使用]
Fold 4: [训练] [训练] [训练] [训练] [验证]
```

注意几个关键区别：
1. 训练集的大小是递增的（越后面的 fold 用了越多的历史数据）
2. 没有随机性——数据的顺序由时间决定
3. 评估结果反映的是"用历史数据预测未来"的真实能力

**带有 gap 的 Time Series Split**：在某些场景下，你不会在训练数据截止的第二天就做预测。比如股票预测，你可能用截止到 1 月的数据预测 3 月的走势。这种情况下，训练集和验证集之间应该有一个时间间隔（gap），避免用紧邻的信息做预测。

```python
from sklearn.model_selection import TimeSeriesSplit

# 带 gap 的时间序列分割
tscv = TimeSeriesSplit(n_splits=5, gap=30)  # gap=30 表示训练集和验证集之间跳过30个时间步
```

### Nested Cross-Validation（嵌套交叉验证）

当你需要同时做两件事——（1）选择超参数和（2）评估模型性能——时，你需要嵌套交叉验证。

**问题**：如果你用 K-Fold CV 选择超参数（选出了使交叉验证平均分最高的超参数），然后又报告这个最高分作为模型性能，你就犯了"在同一数据上既选择又评估"的错误。这会导致评估结果偏乐观。

**解决方案**：用两层交叉验证。

```
外层循环（评估性能）：
  对于外层的每个 fold：
    用该 fold 的训练数据做内层交叉验证（选超参数）
    用选出的超参数在该 fold 的验证数据上评估

外层的评估结果才是模型的真实性能估计
内层只是用来选超参数的
```

具体来说，假设外层 5 折、内层 3 折：

```
外层 Fold 1:
  内层（只用外层 Fold 1 的训练数据）:
    内层 Fold 1: 选超参数 → 得分1
    内层 Fold 2: 选超参数 → 得分2
    内层 Fold 3: 选超参数 → 得分3
    → 平均得分最高的超参数 = best_params_1
  用 best_params_1 在外层 Fold 1 的验证数据上评估 → 外层得分1

外层 Fold 2:
  ... 同上 ...
  → best_params_2, 外层得分2

...

最终模型性能 = mean(外层得分1, ..., 外层得分5)
```

嵌套交叉验证的代价是计算量：外层 5 折 × 内层 3 折 = 15 次模型训练。如果模型训练本身就很耗时，这可能不现实。但对于需要可靠评估的场景（学术论文、医疗应用），这是必要的代价。

### 数据泄露的 7 种常见模式

现在让我们详细看看最常见的 7 种数据泄露。每种我都会给出具体的例子和防范方法。

#### 模式 1：在 split 之前做标准化

这是最经典的预处理泄露。

**错误做法**：
```python
# 错误！在全数据上做标准化
scaler = StandardScaler()
X_scaled = scaler.fit_transform(X)  # 用了全数据的均值和标准差
X_train, X_test = train_test_split(X_scaled, y, test_size=0.2)
# 现在 X_train 被用包含 X_test 信息的统计量缩放过
```

**为什么是泄露**：标准化的均值和标准差是全数据计算的，其中包含了测试集的信息。训练数据被"调整"到了一个它不该知道的尺度上。

**正确做法**：
```python
X_train, X_test = train_test_split(X, y, test_size=0.2)
scaler = StandardScaler()
X_train_scaled = scaler.fit_transform(X_train)  # 只在训练数据上 fit
X_test_scaled = scaler.transform(X_test)          # 用训练数据的统计量 transform
```

**在交叉验证中**：用 Pipeline。

```python
from sklearn.pipeline import Pipeline
from sklearn.preprocessing import StandardScaler
from sklearn.linear_model import LogisticRegression
from sklearn.model_selection import cross_val_score

pipe = Pipeline([
    ('scaler', StandardScaler()),
    ('clf', LogisticRegression())
])

# Pipeline 会自动确保：每个 fold 中，scaler 只在该 fold 的训练数据上 fit
scores = cross_val_score(pipe, X, y, cv=5)
```

#### 模式 2：在 split 之前做特征选择

在全数据上做特征选择，然后交叉验证，会导致严重的泄露。

**错误做法**：
```python
# 错误！在全数据上选特征
from sklearn.feature_selection import SelectKBest, f_classif
selector = SelectKBest(f_classif, k=10)
X_selected = selector.fit_transform(X, y)  # 用了全数据（包括测试集）来选特征
scores = cross_val_score(LogisticRegression(), X_selected, y, cv=5)
```

**为什么是泄露**：特征选择过程看到了所有数据（包括测试集）的标签信息来决定哪些特征最好。这等于在考试前告诉模型"这些特征和答案最相关"。

**耶鲁大学 2024 年的研究**特别指出了这个问题：特征选择泄露可以将模型的表观 AUC 从 0.65 提高到 0.85，但实际部署后可能连 0.60 都达不到。

**正确做法**：把特征选择放进 Pipeline。

```python
pipe = Pipeline([
    ('selector', SelectKBest(f_classif, k=10)),
    ('clf', LogisticRegression())
])
scores = cross_val_score(pipe, X, y, cv=5)
```

#### 模式 3：在 split 之前做插值

用全数据的统计量来填充缺失值。

**错误做法**：
```python
# 错误！用全数据的均值填充缺失值
X['age'] = X['age'].fillna(X['age'].mean())  # 全数据的均值包含了测试集
X_train, X_test = train_test_split(X, y, test_size=0.2)
```

**正确做法**：
```python
X_train, X_test = train_test_split(X, y, test_size=0.2)
train_mean = X_train['age'].mean()  # 只用训练集的均值
X_train['age'] = X_train['age'].fillna(train_mean)
X_test['age'] = X_test['age'].fillna(train_mean)  # 测试集也用训练集的均值
```

#### 模式 4：Target Encoding 在全数据上做

Target Encoding（目标编码）是把类别特征替换为该类别对应的目标变量均值。比如把"城市"替换为"该城市的平均房价"。

**错误做法**：
```python
# 错误！用全数据做 target encoding
city_mean_price = df.groupby('city')['price'].mean()  # 包含了测试集的 price
df['city_encoded'] = df['city'].map(city_mean_price)
```

这实际上是**最严重的泄露类型之一**，因为你直接把目标变量的信息编码进了特征。

**正确做法**：使用 K-Fold target encoding（也叫 Leave-One-Out encoding），确保编码只使用训练集的信息。

```python
from sklearn.model_selection import KFold
import numpy as np

def target_encode_kfold(train_series, target, n_folds=5, smooth=0.3):
    """K-Fold Target Encoding"""
    global_mean = target.mean()
    encoded = pd.Series(index=train_series.index, dtype=float)
    
    kf = KFold(n_splits=n_folds, shuffle=True, random_state=42)
    for train_idx, val_idx in kf.split(train_series):
        # 在每个 fold 中，只用训练部分的 target 来计算编码
        fold_means = target.iloc[train_idx].groupby(
            train_series.iloc[train_idx]
        ).mean()
        encoded.iloc[val_idx] = train_series.iloc[val_idx].map(fold_means)
    
    # 未知的类别用全局均值
    encoded = encoded.fillna(global_mean)
    return encoded
```

#### 模式 5：重复样本导致的泄露

当你的数据中有重复（或近似重复）的样本时，它们可能同时出现在训练集和测试集。

**场景**：
- 同一张图片被存了多次（文件名不同但内容相同）
- 同一条日志被记录了多次
- 同一个用户行为被不同系统重复记录

**为什么是泄露**：模型在训练时见过测试数据的精确副本，评估结果自然是完美的。

**防范方法**：
```python
# 去重
df = df.drop_duplicates()

# 对于近似重复，可以用相似度检测
from sklearn.metrics.pairwise import cosine_similarity
# 计算样本之间的相似度，移除过高的
```

#### 模式 6：时间序列中的未来信息泄露

这是前面提到的 Time Series Split 要解决的问题。但还有一些更隐蔽的时间泄露：

**用未来数据构造特征**：
- 用截至 12 月 31 日的数据来构造 12 月 1 日的特征（比如"过去 30 天平均"这个特征，如果计算时包含了 12 月 1 日之后的数据，就是泄露）
- 用全年的数据计算季节性指数，然后用这个指数来预测某一天

**正确做法**：
```python
# 确保特征只使用截止到预测时刻之前的数据
# 比如计算"过去30天移动平均"
df['ma_30'] = df['value'].rolling(window=30).shift(1)  # shift(1) 确保不包含当天
```

#### 模式 7：样本生成时的泄露

当你的数据收集过程本身引入了偏差时。

**场景**：
- 疾病预测：只有做了检查的患者才有数据，而做不做检查本身就和疾病相关
- 欺诈检测：只有被标记的欺诈案件才是正样本，但很多欺诈没有被标记
- 推荐系统：只有被推荐过的物品才有交互数据，没被推荐的物品没有数据

**防范方法**：这类泄露很难在模型层面解决，需要在数据收集和实验设计阶段就注意。关键是要问自己：**"这个特征在模型实际使用时，还能获取到吗？"**

### 交叉验证的方差问题

交叉验证给出的是性能的**估计值**，不是真实值。这个估计本身也有方差。

影响交叉验证方差的因素：

1. **K 的选择**：K 越小，每次训练用的数据越少，偏差越大；K 越大，fold 之间的相关性越高，方差可能反而增大
2. **数据量**：数据越少，不同 fold 之间的差异越大，方差越高
3. **模型的稳定性**：决策树等高方差模型，不同 fold 的结果差异会很大；线性模型等低方差模型则比较稳定

**重复交叉验证（Repeated K-Fold）** 是降低方差的一个方法：

```python
from sklearn.model_selection import RepeatedStratifiedKFold

cv = RepeatedStratifiedKFold(n_splits=5, n_repeats=3, random_state=42)
# 总共 5×3=15 次评估
scores = cross_val_score(model, X, y, cv=cv)
print(f"平均: {scores.mean():.3f} ± {scores.std():.3f}")
```

### 交叉验证的常见误区

**误区 1：交叉验证选出的模型就是最终模型**

交叉验证是用来**评估**的，不是用来**训练**的。交叉验证不会给你一个训练好的模型——它只是告诉你"如果你用这个方法训练，预计性能大概是多少"。

正确的流程：
1. 用交叉验证评估不同方法（模型类型、超参数）的性能
2. 选出最好的方法
3. 用**全部数据**重新训练一个最终模型（不要浪费任何数据）
4. 如果你有独立的测试集，用这个最终模型在测试集上做最终评估

**误区 2：交叉验证的分数可以替代测试集**

交叉验证的分数仍然是对训练数据的评估。如果你在交叉验证的基础上做了很多次模型选择和调参，交叉验证的分数会被"优化"得偏乐观。你仍然需要一个从未被使用过的独立测试集来做最终评估。

**误区 3：交叉验证结果可以直接比较而不考虑方差**

如果模型 A 的交叉验证准确率是 85.2% ± 2.1%，模型 B 是 84.8% ± 1.8%，两者之间的差异在统计上是不显著的。你不能说"A 比 B 好"。

正确做法：
```python
from scipy import stats

# 用配对 t 检验比较两个模型
t_stat, p_value = stats.ttest_rel(scores_A, scores_B)
if p_value < 0.05:
    print("差异显著")
else:
    print("差异不显著，两个模型可能没有实质差别")
```

## 代码示例

下面是一个完整的 Python 示例，演示交叉验证的各种策略和数据泄露的识别与防范。

```python
import numpy as np
import pandas as pd
import matplotlib.pyplot as plt
from sklearn.datasets import make_classification, load_breast_cancer
from sklearn.model_selection import (
    KFold, StratifiedKFold, GroupKFold, TimeSeriesSplit,
    cross_val_score, train_test_split, cross_validate,
    RepeatedStratifiedKFold
)
from sklearn.preprocessing import StandardScaler
from sklearn.linear_model import LogisticRegression
from sklearn.ensemble import RandomForestClassifier
from sklearn.pipeline import Pipeline
from sklearn.metrics import accuracy_score, roc_auc_score
import warnings
warnings.filterwarnings('ignore')

# ============================================================
# 1. 基础对比：Train/Test Split vs K-Fold CV
# ============================================================
print("=" * 70)
print("1. Train/Test Split vs K-Fold 交叉验证")
print("=" * 70)

# 生成一个不平衡的二分类数据集
X, y = make_classification(
    n_samples=1000, n_features=20, n_informative=10,
    n_redundant=5, random_state=42, weights=[0.85, 0.15]
)

model = LogisticRegression(max_iter=1000, random_state=42)

# 方法 1：单次 Train/Test Split（10 次，看波动）
split_scores = []
for seed in range(10):
    X_tr, X_te, y_tr, y_te = train_test_split(X, y, test_size=0.2, random_state=seed)
    model.fit(X_tr, y_tr)
    split_scores.append(accuracy_score(y_te, model.predict(X_te)))

print(f"\n单次 Train/Test Split（10 次不同随机种子）：")
print(f"  准确率范围: {min(split_scores):.4f} ~ {max(split_scores):.4f}")
print(f"  平均准确率: {np.mean(split_scores):.4f} ± {np.std(split_scores):.4f}")
print(f"  最大差异: {max(split_scores) - min(split_scores):.4f}")
print(f"  → 不同随机划分的结果差异可达 {(max(split_scores) - min(split_scores)) * 100:.1f}%")

# 方法 2：5-Fold 交叉验证
kf_scores = cross_val_score(model, X, y, cv=KFold(n_splits=5, shuffle=True, random_state=42))
print(f"\n5-Fold 交叉验证：")
print(f"  各折得分: {np.round(kf_scores, 4)}")
print(f"  平均准确率: {kf_scores.mean():.4f} ± {kf_scores.std():.4f}")

# 方法 3：10-Fold 交叉验证
kf10_scores = cross_val_score(model, X, y, cv=KFold(n_splits=10, shuffle=True, random_state=42))
print(f"\n10-Fold 交叉验证：")
print(f"  平均准确率: {kf10_scores.mean():.4f} ± {kf10_scores.std():.4f}")

# 预期输出类似：
# 单次 Train/Test Split（10 次不同随机种子）：
#   准确率范围: 0.8900 ~ 0.9300
#   平均准确率: 0.9110 ± 0.0124
#   最大差异: 0.0400
#   → 不同随机划分的结果差异可达 4.0%
#
# 5-Fold 交叉验证：
#   各折得分: [0.905 0.91  0.915 0.91  0.905]
#   平均准确率: 0.9090 ± 0.0042
#
# 10-Fold 交叉验证：
#   平均准确率: 0.9100 ± 0.0055

# ============================================================
# 2. Stratified vs 普通 K-Fold
# ============================================================
print("\n" + "=" * 70)
print("2. Stratified K-Fold vs 普通 K-Fold（不平衡数据）")
print("=" * 70)

print(f"数据集正样本比例: {y.mean():.2%}")

# 普通 K-Fold
kf = KFold(n_splits=5, shuffle=True, random_state=42)
kf_fold_ratios = []
for train_idx, val_idx in kf.split(X, y):
    kf_fold_ratios.append(y[val_idx].mean())

# Stratified K-Fold
skf = StratifiedKFold(n_splits=5, shuffle=True, random_state=42)
skf_fold_ratios = []
for train_idx, val_idx in skf.split(X, y):
    skf_fold_ratios.append(y[val_idx].mean())

print(f"\n普通 K-Fold 各折正样本比例:")
for i, r in enumerate(kf_fold_ratios):
    print(f"  Fold {i+1}: {r:.2%}")
print(f"  标准差: {np.std(kf_fold_ratios):.4f}")

print(f"\nStratified K-Fold 各折正样本比例:")
for i, r in enumerate(skf_fold_ratios):
    print(f"  Fold {i+1}: {r:.2%}")
print(f"  标准差: {np.std(skf_fold_ratios):.4f}")

# 性能对比
kf_scores = cross_val_score(model, X, y, cv=KFold(n_splits=5, shuffle=True, random_state=42))
skf_scores = cross_val_score(model, X, y, cv=StratifiedKFold(n_splits=5, shuffle=True, random_state=42))

print(f"\n性能对比:")
print(f"  普通 K-Fold:       {kf_scores.mean():.4f} ± {kf_scores.std():.4f}")
print(f"  Stratified K-Fold: {skf_scores.mean():.4f} ± {skf_scores.std():.4f}")
print(f"  → Stratified 的方差更小，结果更稳定")

# 预期输出类似：
# 普通 K-Fold 各折正样本比例:
#   Fold 1: 16.50%
#   Fold 2: 14.00%
#   Fold 3: 13.50%
#   Fold 4: 14.50%
#   Fold 5: 16.50%
#   标准差: 0.0133
#
# Stratified K-Fold 各折正样本比例:
#   Fold 1: 15.00%
#   Fold 2: 15.00%
#   Fold 3: 15.00%
#   Fold 4: 15.00%
#   Fold 5: 15.00%
#   标准差: 0.0000

# ============================================================
# 3. Group K-Fold 示例
# ============================================================
print("\n" + "=" * 70)
print("3. Group K-Fold（按组划分）")
print("=" * 70)

# 模拟：100 个患者，每人 5-10 条记录
np.random.seed(42)
n_patients = 100
records_per_patient = np.random.randint(5, 11, n_patients)
n_total = records_per_patient.sum()

groups = np.repeat(np.arange(n_patients), records_per_patient)
X_group = np.random.randn(n_total, 10)
y_group = np.random.randint(0, 2, n_total)

print(f"总样本数: {n_total}")
print(f"患者数: {n_patients}")
print(f"每患者记录数: {records_per_patient.min()}-{records_per_patient.max()}")

# 普通 K-Fold（错误：同一患者的数据可能同时出现在训练集和测试集）
kf_normal = KFold(n_splits=5, shuffle=True, random_state=42)
normal_leak_count = 0
for train_idx, val_idx in kf_normal.split(X_group):
    train_groups = set(groups[train_idx])
    val_groups = set(groups[val_idx])
    overlap = train_groups & val_groups
    normal_leak_count += len(overlap)

print(f"\n普通 K-Fold：")
print(f"  平均每个 fold 有 {normal_leak_count/5:.0f} 个患者同时出现在训练集和测试集")
print(f"  → 评估结果会过度乐观")

# Group K-Fold（正确：同一患者只在训练集或测试集中的其中一个）
gkf = GroupKFold(n_splits=5)
group_leak_count = 0
for train_idx, val_idx in gkf.split(X_group, y_group, groups):
    train_groups = set(groups[train_idx])
    val_groups = set(groups[val_idx])
    overlap = train_groups & val_groups
    group_leak_count += len(overlap)

print(f"\nGroup K-Fold：")
print(f"  每个 fold 有 {group_leak_count/5:.0f} 个患者同时出现在训练集和测试集")
print(f"  → 完全没有泄露")

# 性能对比
normal_scores = cross_val_score(
    LogisticRegression(max_iter=1000), X_group, y_group,
    cv=KFold(n_splits=5, shuffle=True, random_state=42)
)
group_scores = cross_val_score(
    LogisticRegression(max_iter=1000), X_group, y_group,
    cv=GroupKFold(n_splits=5), groups=groups
)

print(f"\n性能对比:")
print(f"  普通 K-Fold:   {normal_scores.mean():.4f} ± {normal_scores.std():.4f}")
print(f"  Group K-Fold:  {group_scores.mean():.4f} ± {group_scores.std():.4f}")

# ============================================================
# 4. Time Series Split 示例
# ============================================================
print("\n" + "=" * 70)
print("4. Time Series Split（时间序列交叉验证）")
print("=" * 70)

# 生成时间序列数据
np.random.seed(42)
n_time = 500
dates = pd.date_range('2022-01-01', periods=n_time, freq='D')
ts_data = pd.DataFrame({
    'date': dates,
    'value': np.cumsum(np.random.randn(n_time)) + 100,
    'feature1': np.random.randn(n_time),
    'feature2': np.random.randn(n_time) * 0.5,
})
ts_data['target'] = (ts_data['value'].shift(-1) > ts_data['value']).astype(int)
ts_data = ts_data.dropna()

print(f"时间范围: {ts_data['date'].min().date()} 到 {ts_data['date'].max().date()}")
print(f"样本数: {len(ts_data)}")

X_ts = ts_data[['feature1', 'feature2', 'value']].values
y_ts = ts_data['target'].values

# Time Series Split
tscv = TimeSeriesSplit(n_splits=5)
print(f"\nTime Series Split 各折:")
for i, (train_idx, val_idx) in enumerate(tscv.split(X_ts)):
    train_start = ts_data['date'].iloc[train_idx[0]].date()
    train_end = ts_data['date'].iloc[train_idx[-1]].date()
    val_start = ts_data['date'].iloc[val_idx[0]].date()
    val_end = ts_data['date'].iloc[val_idx[-1]].date()
    print(f"  Fold {i+1}: 训练 [{train_start} ~ {train_end}] ({len(train_idx)} 样本) "
          f"→ 验证 [{val_start} ~ {val_end}] ({len(val_idx)} 样本)")

ts_scores = cross_val_score(
    LogisticRegression(max_iter=1000), X_ts, y_ts, cv=tscv
)
print(f"\nTime Series CV 准确率: {ts_scores.mean():.4f} ± {ts_scores.std():.4f}")

# 对比：普通 K-Fold（错误，会用到未来数据）
kf_ts_scores = cross_val_score(
    LogisticRegression(max_iter=1000), X_ts, y_ts,
    cv=KFold(n_splits=5, shuffle=True, random_state=42)
)
print(f"普通 K-Fold 准确率: {kf_ts_scores.mean():.4f} ± {kf_ts_scores.std():.4f}")
print(f"→ 普通 K-Fold 在时间序列上结果不可靠（用了未来数据）")

# ============================================================
# 5. 数据泄露演示：标准化泄露
# ============================================================
print("\n" + "=" * 70)
print("5. 数据泄露演示：标准化泄露")
print("=" * 70)

# 用乳腺癌数据集
cancer = load_breast_cancer()
X_c, y_c = cancer.data, cancer.target

# 方法 A（错误）：在全数据上标准化后交叉验证
scaler_leak = StandardScaler()
X_leak = scaler_leak.fit_transform(X_c)
scores_leak = cross_val_score(LogisticRegression(max_iter=5000), X_leak, y_c, cv=5)

# 方法 B（正确）：标准化放在 Pipeline 里
pipe = Pipeline([
    ('scaler', StandardScaler()),
    ('clf', LogisticRegression(max_iter=5000))
])
scores_correct = cross_val_score(pipe, X_c, y_c, cv=5)

print(f"方法 A（泄露 - 全数据标准化）: {scores_leak.mean():.4f} ± {scores_leak.std():.4f}")
print(f"方法 B（正确 - Pipeline 标准化）: {scores_correct.mean():.4f} ± {scores_correct.std():.4f}")
print(f"差异: {scores_leak.mean() - scores_correct.mean():.4f}")

if scores_leak.mean() > scores_correct.mean():
    print(f"→ 泄露版本准确率虚高了 {(scores_leak.mean() - scores_correct.mean())*100:.2f}%")
else:
    print(f"→ 在这个数据集上差异很小（数据量大，泄露影响被稀释了）")

print(f"\n注意：数据量越大，单次泄露的影响越小，但累积效应仍然存在。")
print(f"在数据量小或泄露更严重（如特征选择泄露）的场景下，差异会非常大。")

# ============================================================
# 6. 数据泄露演示：特征选择泄露
# ============================================================
print("\n" + "=" * 70)
print("6. 数据泄露演示：特征选择泄露（最危险的泄露类型之一）")
print("=" * 70)

from sklearn.feature_selection import SelectKBest, f_classif

# 生成一个有很多噪声特征的数据集
np.random.seed(42)
n_samples = 200
n_features = 100
n_informative = 5

X_noisy, y_noisy = make_classification(
    n_samples=n_samples, n_features=n_features,
    n_informative=n_informative, n_redundant=0,
    n_classes=2, random_state=42
)

print(f"数据集: {n_samples} 样本, {n_features} 特征 (仅 {n_informative} 个有用)")

# 方法 A（严重泄露）：全数据上做特征选择
selector_leak = SelectKBest(f_classif, k=10)
X_selected_leak = selector_leak.fit_transform(X_noisy, y_noisy)
scores_fs_leak = cross_val_score(
    LogisticRegression(max_iter=5000), X_selected_leak, y_noisy, cv=5
)

# 方法 B（正确）：特征选择放在 Pipeline 里
pipe_fs = Pipeline([
    ('selector', SelectKBest(f_classif, k=10)),
    ('clf', LogisticRegression(max_iter=5000))
])
scores_fs_correct = cross_val_score(pipe_fs, X_noisy, y_noisy, cv=5)

print(f"\n方法 A（泄露 - 全数据特征选择）: {scores_fs_leak.mean():.4f} ± {scores_fs_leak.std():.4f}")
print(f"方法 B（正确 - Pipeline 特征选择）: {scores_fs_correct.mean():.4f} ± {scores_fs_correct.std():.4f}")
print(f"差异: {scores_fs_leak.mean() - scores_fs_correct.mean():.4f}")
print(f"→ 特征选择泄露导致准确率虚高了 {(scores_fs_leak.mean() - scores_fs_correct.mean())*100:.1f}%")
print(f"→ 这是因为特征选择过程看到了测试集的标签信息")

# ============================================================
# 7. 嵌套交叉验证
# ============================================================
print("\n" + "=" * 70)
print("7. 嵌套交叉验证（正确评估超参数调优后的性能）")
print("=" * 70)

from sklearn.model_selection import GridSearchCV

# 非嵌套方法（错误）：用同一份交叉验证数据选超参数并报告性能
param_grid = {'C': [0.01, 0.1, 1, 10, 100]}
grid = GridSearchCV(
    LogisticRegression(max_iter=5000), param_grid, cv=5, scoring='accuracy'
)
grid.fit(X_c, y_c)
non_nested_score = grid.best_score_

# 嵌套方法（正确）：外层评估性能，内层选超参数
nested_scores = cross_val_score(
    GridSearchCV(
        LogisticRegression(max_iter=5000), param_grid, cv=3, scoring='accuracy'
    ),
    X_c, y_c, cv=5
)

print(f"非嵌套方法（选超参数并报告同一 CV 分数）: {non_nested_score:.4f}")
print(f"嵌套方法（独立评估）: {nested_scores.mean():.4f} ± {nested_scores.std():.4f}")
print(f"差异: {non_nested_score - nested_scores.mean():.4f}")
if non_nested_score > nested_scores.mean():
    print(f"→ 非嵌套方法虚高了 {(non_nested_score - nested_scores.mean())*100:.2f}%")
print(f"\n关键原则：超参数选择引入的偏差使得非嵌套评估偏乐观。")
print(f"需要可靠评估时，必须使用嵌套交叉验证。")

# ============================================================
# 8. 交叉验证结果可视化
# ============================================================
print("\n" + "=" * 70)
print("8. 交叉验证策略可视化")
print("=" * 70)

fig, axes = plt.subplots(2, 2, figsize=(16, 10))

# 可视化不同 CV 策略的 fold 分配
def plot_cv(cv, X, y, ax, title, groups=None):
    """可视化交叉验证的 fold 分配"""
    n_samples = len(y)
    cmap = plt.cm.Set3
    
    for i, (train_idx, val_idx) in enumerate(cv.split(X, y, groups)):
        # 画训练集
        ax.barh(i, len(train_idx), left=0, height=0.6, color='steelblue', alpha=0.6)
        # 画验证集
        ax.barh(i, len(val_idx), left=train_idx[-1] + 1 if len(train_idx) > 0 else 0,
                height=0.6, color='coral', alpha=0.8)

# 改用更直观的可视化方法
def plot_cv_splits(cv, X, y, ax, title, groups=None):
    """用色块表示每个样本在每个 fold 中的角色"""
    n_samples = len(y)
    cv_splits = list(cv.split(X, y, groups))
    n_folds = len(cv_splits)
    
    matrix = np.zeros((n_folds, n_samples))
    for i, (train_idx, val_idx) in enumerate(cv_splits):
        matrix[i, train_idx] = 1  # 训练集
        matrix[i, val_idx] = 2    # 验证集
    
    # 为可视化，只取前 100 个样本
    if n_samples > 100:
        matrix = matrix[:, :100]
    
    colors = ['lightgray', '#3498db', '#e74c3c']  # 未使用, 训练, 验证
    from matplotlib.colors import ListedColormap
    cmap = ListedColormap(colors)
    
    ax.imshow(matrix, cmap=cmap, aspect='auto', interpolation='nearest')
    ax.set_title(title, fontsize=12, fontweight='bold')
    ax.set_xlabel('样本索引')
    ax.set_ylabel('Fold')
    ax.set_yticks(range(n_folds))
    ax.set_yticklabels([f'Fold {i+1}' for i in range(n_folds)])

from matplotlib.colors import ListedColormap

X_viz, y_viz = make_classification(n_samples=100, n_features=10, random_state=42, weights=[0.7, 0.3])
groups_viz = np.random.randint(0, 20, 100)

plot_cv_splits(KFold(n_splits=5, shuffle=True, random_state=42), X_viz, y_viz, axes[0,0], 'K-Fold (K=5)')
plot_cv_splits(StratifiedKFold(n_splits=5, shuffle=True, random_state=42), X_viz, y_viz, axes[0,1], 'Stratified K-Fold (K=5)')
plot_cv_splits(GroupKFold(n_splits=5), X_viz, y_viz, axes[1,0], 'Group K-Fold (K=5)', groups=groups_viz)

# Time Series Split
ts_X = np.random.randn(100, 3)
ts_y = np.random.randint(0, 2, 100)
plot_cv_splits(TimeSeriesSplit(n_splits=5), ts_X, ts_y, axes[1,1], 'Time Series Split (K=5)')

# 添加图例
from matplotlib.patches import Patch
legend_elements = [Patch(facecolor='#3498db', label='训练集'),
                   Patch(facecolor='#e74c3c', label='验证集')]
fig.legend(handles=legend_elements, loc='upper center', ncol=2, fontsize=11)

plt.tight_layout(rect=[0, 0, 1, 0.95])
plt.savefig('cross_validation_strategies.png', dpi=150, bbox_inches='tight')
plt.show()
print("交叉验证策略可视化已保存")

# ============================================================
# 9. 完整的防泄露 Pipeline
# ============================================================
print("\n" + "=" * 70)
print("9. 完整的防泄露 Pipeline 示例")
print("=" * 70)

from sklearn.impute import SimpleImputer
from sklearn.preprocessing import OneHotEncoder
from sklearn.compose import ColumnTransformer

# 创建一个模拟的真实数据集
np.random.seed(42)
n = 500
df = pd.DataFrame({
    'age': np.random.normal(40, 15, n),
    'income': np.random.lognormal(10, 1, n),
    'category': np.random.choice(['A', 'B', 'C', 'D'], n),
    'score': np.random.uniform(0, 100, n),
})
# 加入缺失值
df.loc[np.random.choice(n, 30), 'age'] = np.nan
df.loc[np.random.choice(n, 50), 'income'] = np.nan
# 目标变量
df['target'] = (df['age'].fillna(40) * 0.1 + df['income'] / 50000 + 
                (df['category'] == 'A').astype(float) * 0.5 + 
                np.random.randn(n) * 0.3 > 1.5).astype(int)

print(f"数据集: {df.shape[0]} 行, {df.shape[1]-1} 特征")
print(f"缺失值: age {df['age'].isna().sum()}, income {df['income'].isna().sum()}")
print(f"目标分布: {df['target'].mean():.2%} 正样本")

X_df = df.drop('target', axis=1)
y_df = df['target']

# 正确的防泄露 Pipeline
numeric_features = ['age', 'income', 'score']
categorical_features = ['category']

preprocessor = ColumnTransformer([
    ('num', Pipeline([
        ('imputer', SimpleImputer(strategy='median')),
        ('scaler', StandardScaler())
    ]), numeric_features),
    ('cat', Pipeline([
        ('imputer', SimpleImputer(strategy='most_frequent')),
        ('encoder', OneHotEncoder(drop='first', sparse_output=False))
    ]), categorical_features)
])

full_pipe = Pipeline([
    ('preprocessor', preprocessor),
    ('clf', LogisticRegression(max_iter=5000, C=1.0))
])

# 用 Stratified K-Fold 交叉验证
cv = StratifiedKFold(n_splits=5, shuffle=True, random_state=42)
results = cross_validate(
    full_pipe, X_df, y_df, cv=cv,
    scoring=['accuracy', 'roc_auc'],
    return_train_score=True
)

print(f"\n防泄露 Pipeline 交叉验证结果:")
print(f"  训练准确率: {results['train_accuracy'].mean():.4f}")
print(f"  验证准确率: {results['test_accuracy'].mean():.4f} ± {results['test_accuracy'].std():.4f}")
print(f"  验证 AUC:   {results['test_roc_auc'].mean():.4f} ± {results['test_roc_auc'].std():.4f}")
print(f"\n关键: Pipeline 确保了每个 fold 中，所有预处理步骤")
print(f"（缺失值填充、标准化、编码）只在该 fold 的训练数据上拟合。")

# ============================================================
# 10. 选择 CV 策略的决策树
# ============================================================
print("\n" + "=" * 70)
print("10. 选择交叉验证策略的决策指南")
print("=" * 70)

guide = """
╔══════════════════════════════════════════════════════════════════════╗
║                  选择交叉验证策略的决策树                            ║
╠══════════════════════════════════════════════════════════════════════╣
║                                                                    ║
║  数据有明确的时间顺序？                                             ║
║  ├── 是 → TimeSeriesSplit（不用讨论，这是唯一选择）                  ║
║  └── 否 → 数据有自然分组？                                          ║
║           ├── 是 → GroupKFold                                       ║
║           └── 否 → 分类问题且类别不平衡？                            ║
║                    ├── 是 → StratifiedKFold                         ║
║                    └── 否 → KFold（K=5 或 K=10）                    ║
║                                                                    ║
║  需要更稳定的估计？                                                 ║
║  └── 使用 RepeatedStratifiedKFold（5 折 × 3 次重复）                ║
║                                                                    ║
║  同时做超参数调优和性能评估？                                       ║
║  └── 使用嵌套交叉验证                                               ║
║      外层: 评估性能（5 折）                                         ║
║      内层: 选超参数（3 折）                                         ║
║                                                                    ║
║  最终模型用全部数据训练，不浪费任何样本                              ║
╚══════════════════════════════════════════════════════════════════════╝
"""
print(guide)
```

## 真实案例

### 案例 1：Kaggle 竞赛中的数据泄露

2019 年 Kaggle 的一场石油管道缺陷检测竞赛中，排名第一的团队使用了一个特征——"图像文件名中的时间戳"。这个时间戳和缺陷的严重程度高度相关（因为较新采集的图像来自更容易出现缺陷的老旧管道）。然而在实际使用中，这个信息完全不可用——你不能通过文件名来预测缺陷。

这个团队的 AUC 高达 0.98，但如果移除时间戳相关特征，AUC 降到 0.72。

**教训**：在构造特征时，一定要问自己——"这个特征在模型部署后还能获取到吗？"如果答案是否定的，这个特征很可能就是泄露。

### 案例 2：医疗 AI 中的数据泄露

2021 年发表在 Nature Medicine 上的一篇论文回顾了使用机器学习预测 COVID-19 预后的研究。他们发现，许多研究都存在数据泄露问题：

1. **重复样本泄露**：同一个患者的多次 CT 扫描被分到了训练集和测试集
2. **分布泄露**：训练集和测试集来自同一家医院，模型学到了该医院 CT 扫描仪特有的噪声模式
3. **预处理泄露**：在对图像做归一化时使用了全数据的统计量

结果：论文报告的 AUC 通常在 0.90 以上，但实际部署后性能远不如预期。

**教训**：医疗数据有天然的患者分组。正确的做法是用 GroupKFold 按患者分组，确保模型评估的是"对新患者的泛化能力"，而不是"对同一患者新扫描的预测能力"。

### 案例 3：推荐系统中的时间泄露

某电商平台构建了一个推荐模型，用用户的浏览和购买历史来预测他们是否会购买某件商品。他们的训练数据是 2023 年 1 月到 12 月的日志。

问题在于，他们在构造"用户历史偏好"特征时，使用了全年的数据。比如"用户过去一年购买同类商品的次数"这个特征，在预测 2023 年 1 月的行为时，包含了 2023 年全年的信息。

修复方法：改用 Time Series Split，确保每个时间点的特征只使用该时间点之前的数据。

修复前（存在时间泄露）：
- 交叉验证 AUC：0.91
- 线上 A/B 测试 CTR 提升：+2%

修复后（无泄露）：
- 交叉验证 AUC：0.82
- 线上 A/B 测试 CTR 提升：+8%（因为交叉验证的评估更准确，基于此做出的决策更可靠）

**注意一个反直觉的现象**：修复泄露后线上效果反而更好了。这是因为泄露导致交叉验证分数虚高，团队基于虚高的分数做了错误的决策（选了过拟合的模型）。当评估变得准确后，团队能选到真正泛化能力更好的模型。

### 案例 4：金融风控中的 Target Encoding 泄露

某银行构建了一个信用评分模型，其中一个特征是"客户所在城市的平均违约率"。这个特征是通过 target encoding 构造的——用该城市所有客户的违约率来替换"城市"这个类别。

问题在于，在计算"城市平均违约率"时，他们用了包含测试集在内的全量数据。这意味着训练集中每个样本的"城市违约率"特征都包含了测试集客户的信息。

对于大城市（几千个客户），泄露的影响较小（因为单个客户对均值的贡献很小）。但对于小城市（几十个客户），泄露的影响很大。

修复方法：使用 K-Fold Target Encoding。在计算编码时，只用训练数据。对小城市加入平滑（smoothing），避免过拟合：

$$
\text{encoded} = \frac{n \cdot \text{mean}_{\text{city}} + m \cdot \text{mean}_{\text{global}}}{n + m}
$$

其中 $n$ 是该城市的样本数，$m$ 是平滑参数（通常取 10-300）。当城市样本数少时，编码值会被拉向全局均值，避免过拟合。

## 权衡取舍以及何时不该使用

### 交叉验证的代价

**计算代价**：K-Fold 意味着你要训练 K 个模型而不是一个。对于需要训练几小时的深度学习模型，5-Fold CV 意味着训练时间变成 5 倍。

**缓解方法**：
- 对于大模型（深度学习），通常只用单次 train/val/test split，而不是完整的交叉验证
- 如果必须用交叉验证，可以用 2-Fold 或 3-Fold（牺牲一些可靠性来换取更少的计算）
- 使用分布式计算并行训练不同 fold

**数据量足够大时**：如果你的训练数据有几百万元素，一个简单的 train/test split 通常就足够可靠了。因为数据量大，随机划分的波动很小。交叉验证在这种场景下更多是一种"仪式"而不是必需品。

### 过度防范泄露的代价

有时候，过度防范泄露反而会导致模型性能下降：

**场景 1：特征选择泄露的过度防范**

如果你在 Pipeline 里做了特征选择，每个 fold 可能选出不同的特征子集。这会导致最终模型（用全部数据训练时）的特征选择结果和交叉验证时不一致。

**场景 2：Target Encoding 的过度平滑**

如果你在 target encoding 时加了太多平滑（$m$ 很大），编码值几乎就是全局均值，失去了类别信息的区分力。

### 何时不该使用交叉验证

1. **数据量极大（>100 万）时**：随机划分已经足够稳定，交叉验证的额外收益很小，但计算代价很大。

2. **训练成本极高（大语言模型等）时**：训练一次可能需要几天，5-Fold CV 不可接受。这种情况下用固定的 train/val/test split。

3. **在线学习场景**：数据持续到达，模型持续更新。交叉验证不适用于这种场景。应该使用 prequential evaluation（在每条新数据到达时评估，然后加入训练集）。

4. **数据有强时间依赖且实时性要求高时**：即使 Time Series Split 也可能不够，因为最近的 fold（用最多历史数据训练的）最有参考价值，而不应该简单平均所有 fold 的结果。

### 常见的错误做法

**错误 1：在交叉验证的循环外面做任何预处理**

```python
# 错误
scaler = StandardScaler()
X_scaled = scaler.fit_transform(X)  # ← split 之前！
cross_val_score(model, X_scaled, y, cv=5)

# 正确
pipe = Pipeline([('scaler', StandardScaler()), ('model', model)])
cross_val_score(pipe, X, y, cv=5)
```

**错误 2：交叉验证后不重新训练最终模型**

```python
# 错误：交叉验证结束后没有用全部数据训练最终模型
scores = cross_val_score(model, X, y, cv=5)
print(f"模型性能: {scores.mean()}")
# 现在没有可以部署的模型！

# 正确
scores = cross_val_score(model, X, y, cv=5)
print(f"模型性能: {scores.mean()}")
model.fit(X, y)  # 用全部数据训练最终模型
# 现在 model 可以部署了
```

**错误 3：交叉验证分数和测试集分数差距大时忽略**

如果你在交叉验证中得到了 0.95 的 AUC，但在独立测试集上只有 0.80，这通常意味着存在数据泄露（交叉验证分数虚高）或者测试集分布和训练数据差异很大。两种情况都需要认真调查，而不是简单地说"测试集太小了"。

**错误 4：用交叉验证的方差来估计真实部署后的性能波动**

交叉验证的方差反映的是"不同训练数据的随机性导致的性能波动"，但真实部署后还会面临：
- 数据分布随时间变化（概念漂移）
- 新的用户群体和训练数据不同
- 特征在部署环境中的可用性和训练时不同

所以交叉验证的方差只是性能波动的**下界**，真实波动通常更大。

## 关键要点

1. **简单的 train/test split 不够可靠**。一次随机划分的结果有很大的随机性，不同种子可能导致准确率差异几个百分点。交叉验证通过多次评估取平均来消除这种随机性。

2. **数据泄露是评估结果虚假的头号原因**。最常见的泄露发生在预处理阶段——在全数据上做标准化、插值、特征选择、target encoding，然后才 split。正确做法是把所有预处理放进 Pipeline，让它在交叉验证循环内部完成。

3. **不同的数据类型需要不同的交叉验证策略**。时间序列用 TimeSeriesSplit，有分组的数据用 GroupKFold，类别不平衡用 StratifiedKFold。用错了策略和不用交叉验证一样糟糕。

4. **超参数调优和模型评估必须分开**。如果你用交叉验证选超参数，然后报告同一个交叉验证的分数，结果会偏乐观。需要用嵌套交叉验证——内层选超参数，外层评估性能。

5. **Pipeline 是防范泄露的最佳工具**。把所有预处理步骤和模型放进 `sklearn.pipeline.Pipeline`，它自动确保每个 fold 的预处理只依赖该 fold 的训练数据。这是最简单也最可靠的防泄露方法。

6. **在构造特征时始终问自己一个问题**："这个特征在实际部署时还能获取到吗？"如果答案是否定的，很可能是 target leakage。

7. **交叉验证的分数不是真实性能**。它是一个估计值，有自己的方差和偏差。报告时应该包含均值和标准差，重要的决策应该用统计检验来验证差异是否显著。

## 延伸阅读

1. Browne, M. W. (2000). "Cross-validation methods." *Journal of Mathematical Psychology*, 44(1), 108-132. — 交叉验证方法的理论分析

2. Varma, S., & Simon, R. (2006). "Bias in error estimation when using cross-validation for model selection." *BMC Bioinformatics*, 7(1), 91. — 嵌套交叉验证的重要性的经典论文

3. Bengio, Y., & Grandvalet, Y. (2004). "No unbiased estimator of the variance of k-fold cross-validation." *Journal of Machine Learning Research*, 5, 1089-1105. — 证明了 LOO 交叉验证没有通用的方差估计器

4. Kapoor, A., & Narayanan, A. (2023). "Leakage and the reproducibility crisis in machine-learning-based science." *Patterns*, 4(9). — 数据泄露对机器学习研究可重复性的影响

5. Scikit-learn 官方文档: [Cross-validation: evaluating estimator performance](https://scikit-learn.org/stable/modules/cross_validation.html) — 最实用的交叉验证参考

6. Kaggle's Data Leakage Tutorial: [Data Leakage](https://www.kaggle.com/code/alexisbcook/data-leakage) — 数据泄露的入门教程，配有练习
