---
layout: default
title: DALR: Dual-level Alignment Learning for Multimodal Sentence Representation Learning
---

# DALR: Dual-level Alignment Learning for Multimodal Sentence Representation Learning

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.21096" class="toolbar-btn" target="_blank">📄 arXiv: 2506.21096v2</a>
  <a href="https://arxiv.org/pdf/2506.21096.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.21096v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.21096v2', 'DALR: Dual-level Alignment Learning for Multimodal Sentence Representation Learning')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Kang He, Yuzhe Ding, Haining Wang, Fei Li, Chong Teng, Donghong Ji

**分类**: cs.CL

**发布日期**: 2025-06-26 (更新: 2025-07-01)

**备注**: Accepted by ACL 2025 Findings

---

## 💡 一句话要点

**提出DALR以解决多模态句子表示学习中的对齐问题**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多模态学习` `句子表示` `对齐学习` `语义相似性` `排名蒸馏` `计算机视觉` `自然语言处理`

## 📋 核心要点

1. 现有多模态句子表示学习方法主要在粗粒度上对齐图像和文本，导致跨模态错位偏差和模态内部语义差异等问题。
2. 本文提出DALR，通过一致性学习模块实现细粒度的跨模态对齐，并结合排名蒸馏增强句子关系的捕捉能力。
3. 实验结果表明，DALR在语义文本相似性和迁移任务上表现优异，持续超越现有最先进的基线，验证了其有效性。

## 📝 摘要（中文）

现有的多模态句子表示学习方法已取得显著成果，但大多数方法仅在粗粒度上对齐图像和文本，面临跨模态错位偏差和模态内部语义差异等挑战，严重影响句子表示质量。为此，本文提出了DALR（双层对齐学习），通过一致性学习模块软化负样本，并利用辅助任务的语义相似性实现细粒度的跨模态对齐。此外，句子关系超越了二元正负标签，呈现出更复杂的排名结构。为更好地捕捉这些关系并提升表示质量，本文将排名蒸馏与全局模态内部对齐学习相结合。综合实验结果表明，DALR在语义文本相似性和迁移任务上均优于现有最先进的基线方法。

## 🔬 方法详解

**问题定义**：本文旨在解决多模态句子表示学习中的跨模态错位偏差和模态内部语义差异问题。现有方法在对齐图像和文本时，往往仅关注粗粒度的对齐，导致表示质量下降。

**核心思路**：DALR通过引入一致性学习模块，软化负样本并利用辅助任务的语义相似性，实现细粒度的跨模态对齐。同时，考虑到句子关系的复杂性，本文将排名蒸馏与全局模态内部对齐学习相结合，以提升表示质量。

**技术框架**：DALR的整体架构包括两个主要模块：一致性学习模块和排名蒸馏模块。前者负责实现细粒度的跨模态对齐，后者则通过捕捉复杂的句子关系来增强表示能力。

**关键创新**：DALR的主要创新在于其双层对齐学习机制，既关注跨模态对齐的细粒度，又考虑模态内部的复杂关系。这种设计与现有方法的单一对齐策略形成鲜明对比。

**关键设计**：在关键设计上，本文采用了特定的损失函数来平衡正负样本的影响，并设计了适应性调整的网络结构，以便更好地捕捉句子之间的排名关系。

## 📊 实验亮点

实验结果显示，DALR在语义文本相似性和迁移任务上均显著优于现有最先进的基线方法，具体提升幅度达到X%（具体数据未知），验证了其在多模态句子表示学习中的有效性和优势。

## 🎯 应用场景

该研究的潜在应用领域包括自然语言处理、计算机视觉和多模态学习等。通过提升多模态句子表示的质量，DALR可在图像描述生成、视频理解和跨模态检索等任务中发挥重要作用，具有广泛的实际价值和未来影响。

## 📄 摘要（原文）

> Previous multimodal sentence representation learning methods have achieved impressive performance. However, most approaches focus on aligning images and text at a coarse level, facing two critical challenges:cross-modal misalignment bias and intra-modal semantic divergence, which significantly degrade sentence representation quality. To address these challenges, we propose DALR (Dual-level Alignment Learning for Multimodal Sentence Representation). For cross-modal alignment, we propose a consistency learning module that softens negative samples and utilizes semantic similarity from an auxiliary task to achieve fine-grained cross-modal alignment. Additionally, we contend that sentence relationships go beyond binary positive-negative labels, exhibiting a more intricate ranking structure. To better capture these relationships and enhance representation quality, we integrate ranking distillation with global intra-modal alignment learning. Comprehensive experiments on semantic textual similarity (STS) and transfer (TR) tasks validate the effectiveness of our approach, consistently demonstrating its superiority over state-of-the-art baselines.

