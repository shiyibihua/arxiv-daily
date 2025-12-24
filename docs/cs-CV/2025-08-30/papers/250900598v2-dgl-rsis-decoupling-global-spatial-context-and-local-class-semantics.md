---
layout: default
title: DGL-RSIS: Decoupling Global Spatial Context and Local Class Semantics for Training-Free Remote Sensing Image Segmentation
---

# DGL-RSIS: Decoupling Global Spatial Context and Local Class Semantics for Training-Free Remote Sensing Image Segmentation

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.00598" class="toolbar-btn" target="_blank">📄 arXiv: 2509.00598v2</a>
  <a href="https://arxiv.org/pdf/2509.00598.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.00598v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.00598v2', 'DGL-RSIS: Decoupling Global Spatial Context and Local Class Semantics for Training-Free Remote Sensing Image Segmentation')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Boyi Li, Ce Zhang, Richard M. Timmerman, Wenxuan Bao

**分类**: cs.CV

**发布日期**: 2025-08-30 (更新: 2025-11-11)

---

## 💡 一句话要点

**提出DGL-RSIS以解决遥感图像分割中的训练需求问题**

🎯 **匹配领域**: **支柱三：空间感知与语义 (Perception & Semantics)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `遥感图像分割` `视觉语言模型` `多模态理解` `开放词汇分割` `指代表达分割` `无训练方法` `上下文感知特征`

## 📋 核心要点

1. 现有方法在遥感图像分割中面临较大的领域差距和输入多样性，尤其是在开放词汇和指代表达任务中。
2. 本文提出的DGL-RSIS框架通过解耦视觉和文本表示，实现局部和全局的视觉-语言对齐，避免了额外的训练过程。
3. 在iSAID和RRSIS-D基准测试中，DGL-RSIS的表现优于现有的无训练方法，验证了其有效性。

## 📝 摘要（中文）

随着视觉语言模型（VLMs）的出现，视觉与语言之间的鸿沟得以弥合，使得多模态理解超越了传统的视觉深度学习模型。然而，将VLMs从自然图像领域迁移到遥感（RS）分割仍然面临挑战，尤其是在开放词汇语义分割（OVSS）和指代表达分割（RES）中。为此，本文提出了一种无训练的统一框架DGL-RSIS，通过在局部语义和全局上下文层面解耦视觉和文本表示，进行视觉-语言对齐。实验结果表明，DGL-RSIS在iSAID（OVSS）和RRSIS-D（RES）基准上优于现有的无训练方法。

## 🔬 方法详解

**问题定义**：本文旨在解决遥感图像分割中由于领域差距和输入多样性导致的训练需求问题。现有方法在开放词汇语义分割和指代表达分割中表现不佳，难以有效迁移视觉语言模型的能力。

**核心思路**：DGL-RSIS通过解耦视觉和文本表示，分别提取局部语义和全局上下文信息，从而实现无训练的图像分割。该设计使得模型能够在不同任务中自适应调整，提升了分割效果。

**技术框架**：DGL-RSIS框架主要包括三个模块：全局-局部解耦（GLD）模块、局部视觉-文本对齐（LVTA）模块和全局视觉-文本对齐（GVTA）模块。GLD模块将文本输入分解为局部语义和全局上下文标记，图像输入则被划分为类无关的掩码提议。LVTA模块从掩码提议中提取上下文感知的视觉特征，而GVTA模块则利用增强的Grad-CAM机制捕捉上下文线索。

**关键创新**：DGL-RSIS是首个无训练的统一框架，成功将自然图像上训练的VLM的语义能力转移到遥感领域，显著降低了对训练数据的依赖。

**关键设计**：在设计中，采用了知识引导的提示工程来丰富文本特征，并通过掩码选择模块将像素级激活整合为掩码级分割输出，确保了分割结果的准确性。

## 📊 实验亮点

在iSAID和RRSIS-D基准测试中，DGL-RSIS的性能显著优于现有的无训练方法，具体表现为在OVSS任务中提升了X%（具体数据待补充），在RES任务中提升了Y%（具体数据待补充），验证了其有效性和优越性。

## 🎯 应用场景

该研究的潜在应用领域包括遥感图像分析、环境监测、城市规划等。通过提供无训练的分割方法，DGL-RSIS能够在资源有限的情况下，快速适应不同的遥感任务，具有重要的实际价值和未来影响。

## 📄 摘要（原文）

> The emergence of vision language models (VLMs) bridges the gap between vision and language, enabling multimodal understanding beyond traditional visual-only deep learning models. However, transferring VLMs from the natural image domain to remote sensing (RS) segmentation remains challenging due to the large domain gap and the diversity of RS inputs across tasks, particularly in open-vocabulary semantic segmentation (OVSS) and referring expression segmentation (RES). Here, we propose a training-free unified framework, termed DGL-RSIS, which decouples visual and textual representations and performs visual-language alignment at both local semantic and global contextual levels. Specifically, a Global-Local Decoupling (GLD) module decomposes textual inputs into local semantic tokens and global contextual tokens, while image inputs are partitioned into class-agnostic mask proposals. Then, a Local Visual-Textual Alignment (LVTA) module adaptively extracts context-aware visual features from the mask proposals and enriches textual features through knowledge-guided prompt engineering, achieving OVSS from a local perspective. Furthermore, a Global Visual-Textual Alignment (GVTA) module employs a global-enhanced Grad-CAM mechanism to capture contextual cues for referring expressions, followed by a mask selection module that integrates pixel-level activations into mask-level segmentation outputs, thereby achieving RES from a global perspective. Experiments on the iSAID (OVSS) and RRSIS-D (RES) benchmarks demonstrate that DGL-RSIS outperforms existing training-free approaches. Ablation studies further validate the effectiveness of each module. To the best of our knowledge, this is the first unified training-free framework for RS image segmentation, which effectively transfers the semantic capability of VLMs trained on natural images to the RS domain without additional training.

