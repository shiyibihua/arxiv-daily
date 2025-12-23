---
layout: default
title: Aha Moment Revisited: Are VLMs Truly Capable of Self Verification in Inference-time Scaling?
---

# Aha Moment Revisited: Are VLMs Truly Capable of Self Verification in Inference-time Scaling?

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.17417" class="toolbar-btn" target="_blank">📄 arXiv: 2506.17417v2</a>
  <a href="https://arxiv.org/pdf/2506.17417.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.17417v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.17417v2', 'Aha Moment Revisited: Are VLMs Truly Capable of Self Verification in Inference-time Scaling?')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Mingyuan Wu, Meitang Li, Jingcheng Yang, Jize Jiang, Kaizhuo Yan, Zhaoheng Li, Hanchao Yu, Minjia Zhang, Klara Nahrstedt

**分类**: cs.LG

**发布日期**: 2025-06-20 (更新: 2025-09-28)

**备注**: Work in progress, Short Version

---

## 💡 一句话要点

**探讨视觉语言模型在推理时间扩展中的自验证能力**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `视觉语言模型` `推理时间扩展` `自验证能力` `强化学习` `多模态学习`

## 📋 核心要点

1. 现有的推理时间扩展方法在视觉语言模型中的应用效果不如预期，尤其是在自验证能力方面存在不足。
2. 论文通过评估不同的推理时间扩展策略，探讨其对视觉语言模型性能的影响，特别是强化学习微调的模型。
3. 实验结果显示，尽管某些策略提升了性能，但多数投票策略的效果明显优于以验证为中心的方法，且自验证能力较弱。

## 📝 摘要（中文）

推理时间技术如解码时间扩展和自我精炼已被证明能显著提升大型语言模型的推理能力，尤其是通过强化学习引发的自我修正和自我验证行为。本研究探讨这些推理时间扩展方法是否同样能惠及视觉语言模型（VLMs），特别是那些经过强化学习微调的模型。通过广泛评估，我们发现尽管多数投票和最佳N选择的自验证策略提升了VLM性能，但多数投票显著优于以验证为中心的方法。此外，通常与强化学习调优模型相关的推理时间扩展行为，如“A-ha时刻”，并未带来一致的性能提升。我们的分析指出一个关键限制：当前的强化学习训练的VLM在视觉和文本模态上表现出较弱的自验证能力，限制了推理时间扩展的有效性。

## 🔬 方法详解

**问题定义**：本论文旨在解决视觉语言模型在推理时间扩展中的自验证能力不足的问题，现有方法在这一方面的效果不理想，限制了模型的推理性能。

**核心思路**：论文的核心思路是评估不同推理时间扩展策略对视觉语言模型的影响，尤其是强化学习微调模型的自验证能力，探索其潜在的性能提升。

**技术框架**：整体架构包括对多种推理时间扩展策略的评估，如多数投票和最佳N选择，分析其对模型性能的影响，并通过实验验证不同策略的有效性。

**关键创新**：最重要的技术创新在于揭示了当前强化学习训练的视觉语言模型在自验证能力上的不足，并指出多数投票策略在提升性能方面的优势。

**关键设计**：在实验中，设置了不同的参数和损失函数，以评估各推理时间扩展策略的效果，特别关注自验证机制的设计与实现。

## 📊 实验亮点

实验结果表明，采用多数投票策略的视觉语言模型在性能上显著优于以验证为中心的方法，具体提升幅度达到XX%。同时，强化学习调优模型的自验证能力未能带来一致的性能提升，显示出当前方法的局限性。

## 🎯 应用场景

该研究的潜在应用领域包括智能助手、图像描述生成和多模态信息检索等。通过提升视觉语言模型的推理能力，能够更好地理解和处理复杂的视觉与文本信息，推动相关技术的发展与应用。

## 📄 摘要（原文）

> Inference-time techniques such as decoding-time scaling and self-refinement have been shown to substantially improve reasoning in large language models (LLMs), driven by emergent self-correction and self-verification behaviors often elicited through reinforcement learning (RL). In this work, we investigate whether these inference-time scaling methods similarly benefit vision-language models (VLMs), especially those fine-tuned with RL. Through extensive evaluation, we find that while strategies like majority vote and best-of-N with self-verification enhance VLM performance, majority vote significantly outperforms verification-centric ones. Furthermore, inference time scaling behaviors commonly associated with RL-tuned models, such as the 'A-ha moment,' do not yield consistent performance gains. Our analysis identifies a key limitation: current RL-trained VLMs exhibit weak self-verification across both visual and textual modalities, limiting the effectiveness of inference-time scaling.

