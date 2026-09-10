---
publish_time: 1788942600
link: https://www.infoq.cn/article/WlJkEfJxMgaK9o91ow2Z
source: InfoQ
status: confirmed
category: 国际
is_model_related: false
digest: |
  Shopify 工程团队推出 Gisting 技术，将冗长 LLM 系统提示词压缩为精简 Gist 词元集合，提升吞吐、降低推理成本且不改模型权重。其将 Sidekick GraphQL 智能体系统提示词从约 6000 词元压至 1500（4:1 压缩），在 350 RPM 下首词元时间中位数由 438ms 降至 354ms，端到端延迟由 6.8s 降至 4.2s，吞吐由 20.2 QPS 升至 23.4 QPS，并减少 GPU 分配。方法源自 2022 年论文，经师生两阶段训练最小化 KL 散度，将 Gist 嵌入写入分词器特殊词元，推理期无需自定义掩码。
---

# Shopify 推出 Gisting 新技术：将大模型系统提示词压缩为主旨词元

> 原文链接：https://www.infoq.cn/article/WlJkEfJxMgaK9o91ow2Z
> 来源：InfoQ

Shopify 的工程团队推出了一项叫作 Gisting 的新技术"，用于将冗长的 LLM 提示词压缩为精简的 “Gist” 词元集合，从而提升吞吐量并降低推理成本。

Spotify 强调，在推理阶段用简洁的 Gist 词元替代冗长文本可以降低端到端延迟、减少基础设施成本，并提升词元吞吐量，同时无需修改模型的核心权重。

公司表示，Gisting 技术将 Sidekick GraphQL 智能体的系统提示词从约 6000 个词元压缩至 1500 个词元，且没有牺牲预测质量。这意味着上下文规模实现了 4:1 的压缩比：

在每分钟 350 次请求（RPM）的负载下，首词元时间（TTFT）的中位数从 438 毫秒降至 354 毫秒，端到端请求延迟的中位数从 6.8 秒 降至 4.2 秒，吞吐量则从 20.2 QPS 提升至 23.4 QPS。

这些性能指标的改善使 Spotify 得以减少分配的 GPU 数量。

Gisting 技术源自 2022 年论文《Prompt Compression and Contrastive Conditioning for Controllability and Toxicity Reduction in Language Models》"提出的全新的方法，通过一个两步流程学习生成新的被压缩过的 Gist 词元的嵌入向量。第一步是教师阶段，输入原始提示词让模型执行，得到响应教师对数概率。第二步是学生阶段，让模型执行 GIst 词元，得到学生对数概率。最后，对 Gist 词元进行训练，最小化教师对数概率与学生对数概率之间的 KL 散度，直至学生侧的预测结果与教师侧高度匹配。

训练完成后，将 Gist 嵌入直接写入模型的嵌入矩阵，并将新的 Gist 词元注册为模型分词器中的特殊词元。在推理阶段，模型像普通模型一样加载和运行：无需自定义注意力掩码、额外编码器或特殊服务路径。

Gisting 的核心优势在于：模型处理的并非原始提示词的传统文本摘要，而是经过学习得到的表征。该表征的目的是让大语言模型的行为尽可能接近读取原始完整提示词时的表现。

Gisting 能够降低延迟并提升吞吐量。以 Shopify 为例，首词元时间（TTFT）从 438 毫秒降至 354 毫秒，端到端延迟从 6.8 秒降至 4.2 秒。同时，每秒查询数（QPS）从 20.2 提升至 23.4，使工程团队能够缩减整体 GPU 分配。

最后，Shopify 还强调 Gisting 与其他优化技术（如前缀缓存"）是互补的。前缀缓存避免了为已缓存的提示词序列重新计算 KV 张量，但模型在解码阶段仍需处理这些缓存的张量。Gisting 通过用更短的 Gist 词元序列替代长提示词，进一步减少了这方面的开销。因此，两种优化效果可以叠加，Shopify 将它们结合使用。

关于 Gisting，本文所能介绍的内容十分有限。如果想要了解完整细节，建议阅读原文。原文还介绍了自动搜索在 Gisting 流程调优中发挥的作用，以及其他对性能影响显著的实现细节。

查看英文原文：https://www.infoq.com/news/2026/09/spotify-gisting-llm-performance/"