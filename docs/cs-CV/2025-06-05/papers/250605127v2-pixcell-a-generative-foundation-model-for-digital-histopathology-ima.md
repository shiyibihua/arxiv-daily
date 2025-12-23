---
layout: default
title: PixCell: A generative foundation model for digital histopathology images
---

# PixCell: A generative foundation model for digital histopathology images

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2506.05127" class="toolbar-btn" target="_blank">📄 arXiv: 2506.05127v2</a>
  <a href="https://arxiv.org/pdf/2506.05127.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2506.05127v2" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2506.05127v2', 'PixCell: A generative foundation model for digital histopathology images')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Srikar Yellapragada, Alexandros Graikos, Zilinghan Li, Kostas Triaridis, Varun Belagali, Tarak Nath Nandi, Karen Bai, Beatrice S. Knudsen, Tahsin Kurc, Rajarsi R. Gupta, Prateek Prasanna, Ravi K Madduri, Joel Saltz, Dimitris Samaras

**分类**: eess.IV, cs.CV, q-bio.QM

**发布日期**: 2025-06-05 (更新: 2025-12-03)

**备注**: Project page - https://histodiffusion.github.io/docs/projects/pixcell

---

## 💡 一句话要点

**提出PixCell以解决数字病理图像生成问题**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `数字病理学` `生成模型` `扩散模型` `自监督学习` `数据增强` `隐私保护` `虚拟染色`

## 📋 核心要点

1. 核心问题：现有方法在病理学中面临标注数据稀缺和隐私法规限制，难以有效利用数据进行研究。
2. 方法要点：PixCell通过扩散模型和自监督条件训练，能够在无人工标注的情况下生成高质量的病理图像。
3. 实验或效果：PixCell在隐私保护合成数据生成和虚拟IHC染色等任务中表现出色，能够生成真实感强的图像，提升分类性能。

## 📝 摘要（中文）

数字化组织切片革命性地改变了病理学，为癌症诊断和研究提供了大量数据。自监督和视觉-语言模型已被证明能有效挖掘大型病理数据集以学习判别性表示。然而，病理学中存在标注数据稀缺、隐私法规限制数据共享及虚拟染色等独特问题。生成模型能够合成真实且多样的图像，为解决这些问题提供了有效方案。本文介绍了PixCell，这是首个用于组织病理图像的生成基础模型，采用扩散模型训练于PanCan-30M数据集。通过渐进式训练策略和自监督条件，PixCell能够在没有人工标注数据的情况下进行训练，并生成高保真度的合成图像，用于小规模数据集的数据增强。

## 🔬 方法详解

**问题定义**：本文旨在解决病理学中数据稀缺和隐私法规限制带来的挑战，现有方法难以有效利用大量未标注数据进行研究和应用。

**核心思路**：PixCell的核心思路是利用扩散模型生成高质量的病理图像，通过自监督学习策略在没有人工标注的情况下进行训练，从而克服数据稀缺问题。

**技术框架**：PixCell的整体架构包括数据预处理、扩散模型训练和条件生成三个主要模块。首先，使用PanCan-30M数据集进行模型训练，然后通过条件生成模块生成与真实切片相似的合成图像。

**关键创新**：PixCell的创新在于其自监督条件生成方法，使得模型能够在没有人工标注的情况下有效学习并生成高保真度的图像，显著提升了生成图像的质量和多样性。

**关键设计**：在模型设计中，采用了渐进式训练策略，结合特定的损失函数和网络结构，以确保生成图像的真实感和多样性，同时优化了模型的训练效率。

## 📊 实验亮点

在实验中，PixCell展示了其在隐私保护合成数据生成和虚拟IHC染色任务中的高保真度生成能力。与基线模型相比，PixCell生成的图像在真实感和多样性上有显著提升，具体性能数据未提供，但实验结果表明其有效性和应用潜力。

## 🎯 应用场景

PixCell的潜在应用领域包括数字病理学、癌症研究和医疗影像分析。通过生成高质量的合成图像，研究人员可以在不违反隐私法规的情况下共享数据，促进合作研究。此外，该技术还可以用于小规模数据集的增强，提高分类模型的性能，推动病理学的进步。

## 📄 摘要（原文）

> The digitization of histology slides has revolutionized pathology, providing massive datasets for cancer diagnosis and research. Self-supervised and vision-language models have been shown to effectively mine large pathology datasets to learn discriminative representations. On the other hand, there are unique problems in pathology, such as annotated data scarcity, privacy regulations in data sharing, and inherently generative tasks like virtual staining. Generative models, capable of synthesizing realistic and diverse images, present a compelling solution to address these problems through image synthesis. We introduce PixCell, the first generative foundation model for histopathology images. PixCell is a diffusion model trained on PanCan-30M, a large, diverse dataset derived from 69,184 H&E-stained whole slide images of various cancer types. We employ a progressive training strategy and a self-supervision-based conditioning that allows us to scale up training without any human-annotated data. By conditioning on real slides, the synthetic images capture the properties of the real data and can be used as data augmentation for small-scale datasets to boost classification performance. We prove the foundational versatility of PixCell by applying it to two generative downstream tasks: privacy-preserving synthetic data generation and virtual IHC staining. PixCell's high-fidelity conditional generation enables institutions to use their private data to synthesize highly realistic, site-specific surrogate images that can be shared in place of raw patient data. Furthermore, using datasets of roughly paired H&E-IHC tiles, we learn to translate PixCell's conditioning from H&E to multiple IHC stains, allowing the generation of IHC images from H&E inputs. Our trained models are publicly released to accelerate research in computational pathology.

