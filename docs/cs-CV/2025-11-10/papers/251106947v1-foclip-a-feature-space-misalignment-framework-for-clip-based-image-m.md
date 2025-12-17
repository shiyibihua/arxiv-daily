---
layout: default
title: FoCLIP: A Feature-Space Misalignment Framework for CLIP-Based Image Manipulation and Detection
---

# FoCLIP: A Feature-Space Misalignment Framework for CLIP-Based Image Manipulation and Detection

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2511.06947" target="_blank" class="toolbar-btn">arXiv: 2511.06947v1</a>
    <a href="https://arxiv.org/pdf/2511.06947.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2511.06947v1" 
            onclick="toggleFavorite(this, '2511.06947v1', 'FoCLIP: A Feature-Space Misalignment Framework for CLIP-Based Image Manipulation and Detection')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Yulin Chen, Zeyuan Wang, Tianyuan Yu, Yingmei Wei, Liang Bai

**分类**: cs.CV, cs.AI

**发布日期**: 2025-11-10

**备注**: 15 page, 9 figures, published to PRCV

---

## 💡 一句话要点

**提出FoCLIP框架，通过特征空间错位攻击和防御CLIP模型，提升图像篡改检测能力。**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)**

**关键词**: `CLIP模型` `对抗攻击` `特征空间错位` `图像质量评估` `篡改检测` `多模态学习` `图像处理`

## 📋 核心要点

1. CLIP模型的多模态对齐特性使其易受攻击，现有的图像质量评估指标存在脆弱性。
2. FoCLIP框架通过特征对齐、分数平衡和像素保护，在特征空间中实现图像和文本的错位，从而欺骗CLIP模型。
3. 实验表明，FoCLIP能显著提高CLIPscore，同时保持图像视觉质量，并提出了一种有效的篡改检测方法。

## 📝 摘要（中文）

本文提出FoCLIP，一个用于欺骗基于CLIP的图像质量评估指标的特征空间错位框架。FoCLIP基于随机梯度下降技术，集成了三个关键组件来构建欺骗样本：特征对齐（作为核心模块，减少图像-文本模态差距）、分数分布平衡模块和像素保护正则化。这种设计旨在最大化各种输入提示下的CLIPscore预测，即使从人类感知角度来看，图像在视觉上无法识别或与对抗性提示在语义上不一致。在十个艺术杰作提示和ImageNet子集上的实验表明，优化的图像可以在保持高视觉保真度的同时，显著提高CLIPscore。此外，我们发现灰度转换会导致欺骗图像中显著的特征退化，表现为CLIPscore的明显降低，同时保持与原始图像的统计一致性。受此启发，我们提出了一种颜色通道敏感性驱动的篡改检测机制，在标准基准上实现了91%的准确率。总之，这项工作为基于CLIP的多模态系统中的特征错位以及相应的防御方法建立了一条实用的途径。

## 🔬 方法详解

**问题定义**：CLIP模型在图像质量评估等任务中表现出色，但其精细的多模态对齐使其容易受到对抗攻击。现有方法难以在保持图像视觉质量的同时，有效地欺骗CLIP模型，导致CLIPscore的误判。因此，需要一种方法来系统性地研究和利用CLIP模型的脆弱性，并开发相应的防御机制。

**核心思路**：FoCLIP的核心思路是通过在特征空间中引入图像和文本之间的错位，使得图像在视觉上保持可信的同时，其CLIPscore被显著提高。这种错位是通过优化图像，使其在CLIP的图像特征空间中更接近目标文本的特征表示来实现的。同时，为了防止图像质量过度下降，引入了像素保护正则化。

**技术框架**：FoCLIP框架主要包含三个模块：1) 特征对齐模块：通过优化图像，使其CLIP图像特征与目标文本特征对齐，从而提高CLIPscore。2) 分数分布平衡模块：旨在平衡不同提示下的CLIPscore预测，避免模型过度依赖特定提示。3) 像素保护正则化：通过约束像素值的变化，保持图像的视觉质量。整个流程通过随机梯度下降（SGD）进行优化，迭代更新图像，直到满足预设的CLIPscore目标或达到最大迭代次数。

**关键创新**：FoCLIP的关键创新在于提出了一个特征空间错位框架，能够有效地欺骗CLIP模型，同时保持图像的视觉质量。与传统的对抗攻击方法不同，FoCLIP直接在CLIP的特征空间中进行操作，避免了对像素空间的直接干扰，从而更好地保持了图像的视觉保真度。此外，提出的颜色通道敏感性驱动的篡改检测机制，为防御基于CLIP的攻击提供了一种新的思路。

**关键设计**：特征对齐模块使用余弦相似度作为损失函数，衡量图像和文本特征之间的距离。分数分布平衡模块使用KL散度作为损失函数，约束不同提示下的CLIPscore分布。像素保护正则化使用L2范数，限制像素值的变化幅度。颜色通道敏感性分析通过灰度转换来评估不同颜色通道对CLIPscore的影响，并以此为基础设计篡改检测器。具体参数设置（如学习率、正则化系数等）根据实验结果进行调整。

## 📊 实验亮点

实验结果表明，FoCLIP能够显著提高图像的CLIPscore，同时保持较高的视觉质量。在艺术杰作提示和ImageNet子集上，优化后的图像CLIPscore得到了显著提升。此外，提出的颜色通道敏感性驱动的篡改检测机制在标准基准上实现了91%的准确率，验证了该方法的有效性。

## 🎯 应用场景

FoCLIP的研究成果可应用于评估和提高多模态模型的安全性，尤其是在图像质量评估、图像检索和内容审核等领域。通过理解和防御针对CLIP模型的攻击，可以提升这些应用在对抗环境下的鲁棒性。此外，该研究提出的篡改检测方法可以用于识别恶意篡改的图像，保护用户免受虚假信息的侵害。

## 📄 摘要（原文）

> The well-aligned attribute of CLIP-based models enables its effective application like CLIPscore as a widely adopted image quality assessment metric. However, such a CLIP-based metric is vulnerable for its delicate multimodal alignment. In this work, we propose \textbf{FoCLIP}, a feature-space misalignment framework for fooling CLIP-based image quality metric. Based on the stochastic gradient descent technique, FoCLIP integrates three key components to construct fooling examples: feature alignment as the core module to reduce image-text modality gaps, the score distribution balance module and pixel-guard regularization, which collectively optimize multimodal output equilibrium between CLIPscore performance and image quality. Such a design can be engineered to maximize the CLIPscore predictions across diverse input prompts, despite exhibiting either visual unrecognizability or semantic incongruence with the corresponding adversarial prompts from human perceptual perspectives. Experiments on ten artistic masterpiece prompts and ImageNet subsets demonstrate that optimized images can achieve significant improvement in CLIPscore while preserving high visual fidelity. In addition, we found that grayscale conversion induces significant feature degradation in fooling images, exhibiting noticeable CLIPscore reduction while preserving statistical consistency with original images. Inspired by this phenomenon, we propose a color channel sensitivity-driven tampering detection mechanism that achieves 91% accuracy on standard benchmarks. In conclusion, this work establishes a practical pathway for feature misalignment in CLIP-based multimodal systems and the corresponding defense method.

