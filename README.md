# 👨‍💻 Ning Shixian

<p align="center">
  <b>NLP Developer @ Li Auto | Open Source Enthusiast</b><br>
  📍 Based in Beijing, China 🇨🇳
</p>

<p align="center">
  <a href="https://www.yuque.com/ningshixian/"><b>📚 个人博客</b></a> • 
  <a href="https://github.com/ningshixian"><b>📂 GitHub</b></a> • 
</p>

---

## 🛠 技能栈与工具箱 (Languages & Tools)

### 🤖 核心技术
![Python](https://img.shields.io/badge/Python-3776AB?style=flat-square&logo=python&logoColor=white)
![PyTorch](https://img.shields.io/badge/PyTorch-EE4C2C?style=flat-square&logo=pytorch&logoColor=white)
![HuggingFace](https://img.shields.io/badge/%F0%9F%A4%97%20Hugging%20Face-FFD21E?style=flat-square)
![LLM](https://img.shields.io/badge/LLM-RAG%20%2F%20Agent%20%2F%20Post--Training-blueviolet?style=flat-square)

### ⚙️ 后端与工程
![Bash](https://img.shields.io/badge/Bash-4EAA25?style=flat-square&logo=gnu-bash&logoColor=white)
![Docker](https://img.shields.io/badge/Docker-2496ED?style=flat-square&logo=docker&logoColor=white)
![MySQL](https://img.shields.io/badge/MySQL-4479A1?style=flat-square&logo=mysql&logoColor=white)
![Redis](https://img.shields.io/badge/Redis-DC382D?style=flat-square&logo=redis&logoColor=white)
![ElasticSearch](https://img.shields.io/badge/ElasticSearch-005571?style=flat-square&logo=elasticsearch&logoColor=white)
![Kafka](https://img.shields.io/badge/Kafka-231F20?style=flat-square&logo=apache-kafka&logoColor=white)

## 💼 工作经历 (Work Experience)

### 🚗 理想汽车 | 高级算法工程师
*2023.12 - 至今*
> 负责 2C 端智能客服系统开发及大模型（LLM）前沿应用研究。

+ [pytorch-learn](https://github.com/ningshixian/pytorch-learn)：pytorch 框架学习笔记
+ [dialogue-projects](https://github.com/ningshixian/dialogue-projects)：对话系统各组件的极简实现（学习向）
+ [UNIQA](https://github.com/ningshixian/UNIQA)：参考[haystack](https://github.com/deepset-ai/haystack)弄的，主要是学习模块化设计，通过组件和管道实现 RAG 和语义搜索；
+ [fastapi-semantic-retrieval](https://github.com/ningshixian/fastapi-semantic-retrieval)：从实际项目脱敏得到的一个较早版本的框架，项目结构没做调整；
+ [ai_semantic-retrieval-framework](https://github.com/ningshixian/ai_semantic-retrieval-framework)：从实际项目抽象出来的一个检索增强+重排框架（新）。包括：混合检索（emb+bm25）[abstracted_hybrid_retriever.py](https://github.com/ningshixian/ai_semantic-retrieval-framework/blob/main/plugins/retrievers/abstracted_hybrid_retriever.py)、BGE重排序 [abstracted_reranker.py](https://github.com/ningshixian/ai_semantic-retrieval-framework/blob/main/plugins/rankers/abstracted_reranker.py)、Embedding微调 [train_embedding.py](https://github.com/ningshixian/sentence-embedding/blob/main/sbert/unified_sentence_transformer_trainer.py)、Faiss 向量检索 [faiss_tutorial.ipynb](https://github.com/ningshixian/ai_semantic-retrieval-framework/blob/main/plugins/retrievers/faiss_tutorial.ipynb)等...
+ [x-r1-learn](https://github.com/ningshixian/x-r1-learn)：主要是对 GRPO KL variants 的实验
+ [event-cluster-discovery](https://github.com/ningshixian/event-cluster-discovery)：实现了帖子聚类+新事件发现，支持内部的舆情监控项目；
+ [social_kol_review](https://github.com/ningshixian/social_kol_review)：文本风格迁移与因果评论实现，实现一个 AIKOL；
+ [rag-projects](https://github.com/ningshixian/rag-projects)：从零实现RAG课程（[datawhale/All-in-RAG](https://github.com/datawhalechina/all-in-rag)）的学习笔记和代码，博客记录在[此处](https://www.yuque.com/ningshixian/xa7g6q/nyqktwupwmffl5hc?singleDoc#)
+ [agent-projects](https://github.com/ningshixian/agent-projects)：主流 Agent 开源框架的学习代码（[/2025exercises](https://github.com/ningshixian/agent-projects/tree/main/2025exercises)），以及一些学习资料（课程[datawhale/hello-agents](https://github.com/datawhalechina/hello-agents)、OpenAI ChatKit 示例代码、smolAgents 代码）...还有基于 haystack 实现的一个多智能体 demo → [hr-multi-agent](https://github.com/ningshixian/agent-projects/tree/main/2025exercises/08-haystack/hr-multi-agent)。
+ [llm_from_scratch](https://github.com/ningshixian/llm_from_scratch)：LLM 算法原理学习和工程实验仓库。包括 Transformer 的基本组件实现、KV 缓存实现、GPT 类主流大模型架构、minimind-LLM 全阶段极简复现、Post-Traning（SFT、LoRA、DPO、GRPO...）、基于bitsbytes的模型量化等

### 🐚 贝壳找房 | NLP 研究员
*2023.10 - 2023.12*
> 探索 NL2SQL 领域，负责自然语言转数据库查询语句的研究与对齐。

组内项目的目标不明确，导致工作的时候像个无头苍蝇般迷茫，干的很累和疲惫，每天沟通、对齐，却又每天都没对齐，遂放弃了

### 🈳[空窗期]
23年 5 月离职后，照顾媳妇生娃，空窗期了半年。

### 🐲 龙湖集团 | NLP 算法开发
*2019.07 - 2023.05*
> 从 0 到 1 搭建内部 2B 端智能客服系统。

+ [longfor_slot_extract](https://github.com/ningshixian/longfor_slot_extract)：开发 longfor 对话助手中的槽位提取模块，针对不同业务场景，实现精确/模糊/嵌套实体抽取。相关介绍在[博客介绍](https://www.yuque.com/ningshixian/xa7g6q/iksobz#PbBHO)
+ [domain_keyphrase_extract](https://github.com/ningshixian/domain_keyphrase_extract)：领域关键短语抽取，帮助业务挖掘知识中的领域实体词库及其常用说法。具体实验方案的解读在[博客](https://www.yuque.com/ningshixian/dmdx5i/psdsng?singleDoc#)
+ [chinese-interrogative-recognition](https://github.com/ningshixian/chinese-interrogative-recognition)：中文疑问句识别，用于 query 理解。相关介绍在[博客](https://www.yuque.com/ningshixian/xa7g6q/dtdizh?singleDoc#)
+ [corpus-generalization-spider](https://github.com/ningshixian/corpus-generalization-spider)：语料泛化爬虫工具，借助搜索爬虫和相似性度量，对标准问扩展相似问，丰富训练数据；
+ [metric_learning](https://github.com/ningshixian/metric_learning)：这个项目是为了训练 Embedding 模型，包括了度量学习和对比学习的一些实验，主要有双塔、triple loss、AMSoftmax+simcse、rdrop、Bert-whitening等。具体介绍在[博客](https://zhuanlan.zhihu.com/p/434823574)
+ [seq2seq_with_bert_unilm](https://github.com/ningshixian/seq2seq_with_bert_unilm)：以“BERT+UniLM”为基础架构，训练一个Seq2Seq模型，用于坐席辅助-话术生成。主要借鉴了苏剑林.《Seq2Seq+前缀树：检索任务新范式（以KgCLUE为例） 》 [Blog post](https://spaces.ac.cn/archives/8802)
+ [learning_to_rank](https://github.com/ningshixian/learning_to_rank)：主要是排序学习LTR的一些实验，用于协助企业内搜的精排阶段。相关模型介绍在[博客](https://www.yuque.com/ningshixian/kp5efx/zhhpol)

---

## 🥋 兴趣爱好
* 持续关注 NLP 前沿技术（Transformer, RLHF, Multi-Agent）
* 热爱开源社区分享与技术博客撰写
