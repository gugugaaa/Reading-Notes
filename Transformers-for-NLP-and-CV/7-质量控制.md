### 质量控制（Quality Control）
略

### 风险（Risk）

不再仅仅基于benchmark，而是人工智能自动评估自身并改进自身的功能。

#### Auto-BIG-bench

BIG-Bench（Beyond the Imitation Game Benchmark）是包含众多任务的基准测试集，但手动设计和运行耗时

Auto-BIG-Bench 是在 BIG-Bench 基础上的自动化扩展
- 自动生成测试任务
- 自动评估模型性能
- 提升测试效率

#### 风险管理（Risk Management）
- **幻觉，虚假信息**：LLM“自信地”生成虚假信息
- **危险的涌现行为**：LLM生成恶意代码，甚至教人怎么制造危险物品
- **影响力行动**：LLM假装成无数个“真实用户”，大规模操控舆论
- **有害内容**：训练数据里的偏见或恶意内容，如果不加过滤，会被模型学习
- **隐私**：LLM记住了训练数据中的隐私信息
- **记忆**：LLM“记忆混乱”
- **伦理偏差**：LLM学习到了数据中刻板印象和偏见
- **可解释性**：这种“不透明”在关键领域（像法律或医学）很危险
- **文化侵蚀**：LLM 往往以英语和西方文化为主训练

#### 风险缓解（Risk Mitigation）

##### RLHF（Reinforcement Learning from Human Feedback）

- **监督微调** (Supervised Fine-Tuning, SFT)：
  在有监督的高质量数据集上微调模型

- **奖励模型训练** (Reward Model, RM)：
  让模型输出多个候选回答，让人类选择最好的回答，从而训练一个奖励模型（用于"打分"）

- **强化学习** (Reinforcement Learning, RL)：
  通过强化学习算法（如 PPO），模型根据奖励模型的反馈进行迭代训练


##### RAG（增强搜索生成）
知识库（KB）：也可以根据关键词/标签检索